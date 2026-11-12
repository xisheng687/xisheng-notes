---
layout: post
title: "再见 Claude，你好谷歌 Gemini！"
date: 2026-11-12
---

前两天刚和大家聊完 Claude Fable 5.2 的实测表现，模型能力确实强，但 Anthropic 的封号风控实在让人吃不消。

光是今年上半年他们就封了超过 1140 万个账号，近 40 万次申诉里只有一成能解封，而且被封后默认不退费。

今天（11 月 12 日）生效的新规更是把中国大陆、香港和澳门彻底锁死，甚至有开发者从最新版 Claude Code（2.1.314 版）源码里扒出新增了 jy 请求头，会直接读取本地项目的 Git 仓库地址上报排查。

正巧在前天（11 月 10 日），谷歌把最新的主力模型 Gemini 4 Carbon 放进了 Google Antigravity 的包月套餐。

我把 海外开发者的实测案例、跑分数据和套餐附赠权益整理了一遍。

如果没耐心看长文，可以看简短版总结：

1、用正规谷歌账号就能在官方工具里直接调满血 Claude Opus 5.5（完整 1M 上下文），不用天天折腾防封环境，也不用担心代码写到一半突然被封号。

2、套餐里谷歌自家的 Gemini 模型和 Claude 模型是分开算额度的，两边都是每 5 小时刷新一次，互不占用，哪边用完了切另一边就能接着干。

3、刚进包月套餐的 Gemini 4 Carbon 能力很顶：综合推理总榜拿到 60 分（排全球第 2，超过 Opus 5.5 的 59 分），单任务成本比 Fable 5.2 便宜七成；盲测文字总榜和写作榜双双排在全球第 1，中文表达自然，没有生硬的机器味。

4、谷歌大善人附赠的福利非常多：每个月白送 100 美元谷歌云与 API 抵扣金、2500 点 Colab 算力（够调 A100 显卡免费跑 200 多小时训练模型）、完整版 YouTube 会员、30TB 云盘和 25000 点视频生成积分；如果走土耳其区订阅，每个月折合人民币只要 420 元左右（约 60 美元）。

下面，看正文～

## 一、Gemini 4 Carbon 能力有多强

先看大家最关心的额度问题。

在谷歌自家的编程工具 Google Antigravity 里订阅 Ultra 顶配套餐，总配额是 20 美元 Pro 档的 20 倍，每 5 小时自动刷新一次。

这套订阅在额度设计上有两个很实用的地方：

一是客户端里直接内置了满血的 Claude Opus 5.5 和 Sonnet 5.5（支持完整 1M 上下文）。只要用自己的正规谷歌账号订阅，在官方客户端里正常写代码，就不用像直接用 Anthropic 官方号那样天天担心被封号。

当然实际用下来，Antigravity 里的 Opus 5.5 额度消耗速度比 Claude 原厂略快一些，但对不想折腾防封环境的国内用户来说省心太多了。

不过量肯定不如 claude 官方的多，所以肯定不够干重活的。

![](https://xisheng687.github.io/xisheng-notes/assets/posts/2026-11-12-goodbye-claude-hello-gemini-4-carbon/body-01.jpg)

二是谷歌自家的 Gemini 模型和第三方的 Claude 模型分开计算配额。

这个就很有惊喜了，两边都是每 5 小时刷新一次，互不占用。

比如你用 Opus 5.5 改代码把 Claude 这边的配额用完了，切回 Gemini 4 Carbon 依然有完整的 20 倍额度可用；而且平时在 Gemini 网页端和手机端聊天的消耗，也不会占用写代码的额度。

那么刚放进包月套餐的 Gemini 4 Carbon 本身实力如何？

我们可以从综合推理、文字写作、前后端开发四个维度来看最新测试数据：

<strong>1、综合推理：总榜 60 分排全球第 2，单任务成本不到 Fable 5.2 的三成</strong>

在 Artificial Analysis 综合智能指数 v5 上，Gemini 4 Carbon（High）拿到 60 分，排在全球第 2，超过了 Claude Opus 5.5 最高档（59 分）、GPT-6 Astra 最高档（57 分）以及默认档的 Fable 5.2（56 分）。

排第 1 的 Fable 5.2 最高档虽然拿了 65 分，但跑完单个任务平均要花 26.5 美元以上，而 Carbon 平均只要 7.8 美元，成本低了七成。

![](https://xisheng687.github.io/xisheng-notes/assets/posts/2026-11-12-goodbye-claude-hello-gemini-4-carbon/body-02.jpg)

<strong>2、文字与写作评分：盲测总榜与创意写作双双拿下第 1</strong>

在 Arena 全球盲测文字总榜 Text Arena 上，Gemini 4 Carbon（High）以 1528 分排在全球第 1，高于自家的 Argon（1520 分）、Claude Opus 5.5（1509 分）和 Fable 5.1（1504 分）。

在专门评估大模型写作水平的 Writing Weights Index 上，Carbon 也从上一代的 36.0 分涨到了 57.7 分，同样排在 Opus 5.5（51.2 分）前面。

![](https://xisheng687.github.io/xisheng-notes/assets/posts/2026-11-12-goodbye-claude-hello-gemini-4-carbon/body-03.jpg)

以前很多模型写中文长文容易带出一股生硬的英文直译感，或者满篇都是空洞的套话。这次 DeepMind 在训练阶段找了大量专业文字工作者逐条校准语感，所以 Carbon 写出来的中文日常表达自然很多，这也是它能在盲测里拿高分的主要原因。

我的真实体验也是这样，我已经把日常写作的模型从 opus 5.5 切换到了gemini4。

<strong>3、前端、后端与终端工程：比 Opus 便宜 72%，终端测试反超</strong>

前端开发方面，Carbon 在 Code Arena 的 WebDev 榜单上比上一代 Argon 涨了 89 分，达到 1768 分，超过了 GPT-6.1 Sol Max（1751 分）和 Claude Fable 5.1 Max（1746 分）。

![](https://xisheng687.github.io/xisheng-notes/assets/posts/2026-11-12-goodbye-claude-hello-gemini-4-carbon/body-04.jpg)

后端与长程工程方面，在涵盖 2.19 万场真实开发会话的 Agent Arena 上，Carbon 排在全球第 2，单任务中位成本只有 1.80 美元，比排第 1 的 Opus 5.5 Max 便宜了 72%，并在根据用户反馈及时修正方向的评分上拿到单项第 1。

而在终端命令行实战测试 Terminal-Bench 4.0 中，搭配 Antigravity CLI 的 Carbon 拿到 64 分，反超了 Claude Code 搭配 Opus 5.5 Max 的 63 分；在 Mercor 的 APEX-Agents 榜单上也以 84.2% 的一次通过率排在第 1（Fable 5.2 为 80.1%）。

## 二、前端与 3D 网页实测

看完跑分，再看 X 上海外开发者的真实测试。

以前用大模型生成前端页面，很容易出现排版错位或者千篇一律的模板配色。

Gemini 4 Carbon 在 Antigravity 里写完前端代码后，会自动在内置浏览器里渲染页面并截图检查，发现布局重叠或配色不协调就会自己改代码重调。

开发者 thebuggeddev 只给它发了一张参考图，没写任何界面设计说明，它就自己设计了一套复古档案风格的 19 世纪巴黎光谱物理实验室网页。

页面里包含 92 个黄铜盘管和带紫色电离光效的玻璃真空管，左侧有 60 帧实时运转的瓦特连杆，顶部还能切换 X 光和爆炸拆解视图。

<video src="https://xsssn.com/uploads/2026/goodbye-claude-hello-gemini-4-carbon/v1-paris-lab.mp4" controls playsinline preload="metadata" style="max-width:100%"></video>

▲ 视频来自 thebuggeddev，仅凭一张参考图生成的 19 世纪巴黎光谱实验室交互网页

另一位拿到早期测试权限的博主 kimmonismus 让它做一个百万粒子的流体模拟网页 TIDEFORGE。

模型直接调用 WebGPU 实时渲染出 104 万个粒子的螺旋涡流，帧率稳定在 60 帧，而且整套代码是一次生成、没有经过任何二次追问修改。

<video src="https://xsssn.com/uploads/2026/goodbye-claude-hello-gemini-4-carbon/v3-tideforge-particles.mp4" controls playsinline preload="metadata" style="max-width:100%"></video>

▲ 视频来自 kimmonismus，一次生成零修改、用 WebGPU 实时渲染 104 万个粒子的流体网页

如果拿它和刚发布的 Claude Fable 5.2 做同题对比，成本差距就更明显了。

算力团队 gmi_cloud 用同一句提示词，让两个模型分别制作一个可交互的 3D 超跑展示网页。

画面下方的 Fable 5.2 跑了 1 小时 26 分钟，消耗 30.57 美元，做出来的车身依然偏方正；画面上方的 Gemini 4 Carbon 用了 1 小时 13 分钟，只花了 8.27 美元，费用不到前者的四分之一，流线型车身、尾翼和轮毂的细节反而更好。

<video src="https://xsssn.com/uploads/2026/goodbye-claude-hello-gemini-4-carbon/v5-supercar-vs-fable.mp4" controls playsinline preload="metadata" style="max-width:100%"></video>

▲ 视频来自 gmi_cloud，上方为 Gemini 4 Carbon（8.27 美元），下方为 Fable 5.2（30.57 美元）

## 三、纯代码画图与数学建模

在纯代码绘图和数学建模方面，Carbon 对三维空间和物理公式的还原度也很高。

下面这个冰镇可口可乐玻璃瓶，没有导入任何外部 3D 模型和图片贴图，完全是在单个 Shader 里靠数学公式算出来的。

不仅玻璃折射、瓶身水滴和内部气泡非常逼真，连瓶盖边缘都准确算出了 21 颗锯齿，底部还能拖动滑块实时调节结霜程度、二氧化碳气泡量和背光强度。

<video src="https://xsssn.com/uploads/2026/goodbye-claude-hello-gemini-4-carbon/v8-cola-svg.mp4" controls playsinline preload="metadata" style="max-width:100%"></video>

▲ 视频来自 dummerspast39，无外部素材、纯靠数学公式算出的可口可乐玻璃瓶

谷歌官方还演示了一个科研场景：直接把一篇 2026 年关于纬编针织纺织品拉伸力学的数学论文丢给它，它在 Antigravity 里把论文里的公式写成了一个可交互的 3D 纱线物理模拟器。

画面中间可以实时观察 110 根独立纤维在受力拉扯下的应力变化与逐根断裂过程，右侧同步绘制出横截面和应力应变曲线。

<video src="https://xsssn.com/uploads/2026/goodbye-claude-hello-gemini-4-carbon/v9-textile-math.mp4" controls playsinline preload="metadata" style="max-width:100%"></video>

▲ 视频来自 Google 官方，把 2026 年纺织力学论文直接转化为 110 根纤维拉伸断裂的 3D 模拟器

## 四、3D 建模、与 /swarm 协作

在复杂工程、3D 软件操控和多智能体协作上，这次也有几个很有代表性的实测案例。

博主 ai_for_success 在 Antigravity 里让 Carbon 同时操控 FreeCAD 和 Blender，连续运行了 6 个多小时，从零建出了一台 1600 匹马力的双涡轮 V8 发动机。

顶部的双涡轮增压器和正面皮带轮系都可以实时运转，左下角的测功机面板能显示曲轴转速与八个气缸的四冲程点火相位，还能拖动滑块对整台发动机做爆炸拆解。

<video src="https://xsssn.com/uploads/2026/goodbye-claude-hello-gemini-4-carbon/v11-v8-engine-blender.mp4" controls playsinline preload="metadata" style="max-width:100%"></video>

▲ 视频来自 ai_for_success，操控 FreeCAD 与 Blender 连续运行 6 小时建出的 V8 发动机

另外，这次随 Carbon 一起开放的 /swarm 多智能体协作功能，非常适合用来跑大型工程。输入 /swarm 指令后，系统会自动拆解任务，同时启动多个子智能体在各自独立的分支里并行开发，最后再由专门负责验证的子智能体做整体检查。

比如在还原 1889 年埃菲尔铁塔建造过程的案例里，它一次调度了 12 个 Carbon 子智能体，自动执行了 3454 次工具调用，读取并比对了 70 份历史工程图纸与老照片，搭建出 112 个 3D 网格组，并由验证智能体连续跑了 10 轮视觉检查。

<video src="https://xsssn.com/uploads/2026/goodbye-claude-hello-gemini-4-carbon/v12-swarm-eiffel.mp4" controls playsinline preload="metadata" style="max-width:100%"></video>

▲ 视频来自 Antigravity 与 choblin29，用 /swarm 调度 12 个子智能体还原的 1889 埃菲尔铁塔 3D 展馆

## 五、还送了7 项权益

Antigravity 顶配对应的 Google AI Ultra（20x 套餐）美区原价是 200 美元每月。

单看月费跟 Claude 顶配差不多，但谷歌在这个套餐里额外打包了云服务赠金、训练算力和多项会员权益，折算下来实际成本低很多。

<strong>1、每月赠送 100 美元谷歌云与生成式 AI 额度</strong>

开通 Google AI Ultra（20x）后，通过关联的 Google Developer Program，谷歌每个月会往账户里发放 100 美元的官方赠金（一年共 1200 美元；5x 档每月送 40 美元，20 美元的 Pro 档每月送 10 美元）。

这笔钱既可以用来开谷歌云服务器，也能在 Google AI Studio 和 Vertex AI 里直接抵扣调用 Gemini API 的费用，相当于直接抵掉了一半月费。

![](https://xisheng687.github.io/xisheng-notes/assets/posts/2026-11-12-goodbye-claude-hello-gemini-4-carbon/body-05.png)

<strong>2、免费训练模型：每月赠送 Google Colab 2500 点计算单元</strong>

如果需要自己微调模型或跑深度学习脚本，Ultra 套餐直接包含了顶配的 Google Colab 算力包，每个月赠送 2500 点计算单元。

这个额度足够调用英伟达 A100 显卡连续运行 200 多个小时，而且支持关掉浏览器网页后继续在云端后台运行，拿来训练 LoRA 或微调开源模型可以省下一大笔租显卡的钱。

<strong>3、赠送完整版 YouTube Premium 个人会员</strong>

套餐内直接包含完整版的 YouTube Premium 和 YouTube Music 个人会员（单独订阅每月 13.99 美元），支持视频免广告、锁屏后台播放和离线下载。

<strong>4、赠送 30TB 的 Google One 云盘空间（支持 5 人共享）</strong>

Google Drive 网盘、Google Photos 相册和 Gmail 邮箱共享 30TB 存储空间，最多可以拉 5 位家庭成员共同使用。

<strong>5、每月 25000 点 Google Flow 视频生成积分与 Nano Banana 免费生图</strong>

每个月发放 25000 点 AI 创作积分，可以在 Google Flow 里调用 Veo 模型生成视频（按 720p 15 秒视频计算，每月可生成 410 多条），同时内置的 Nano Banana 生图模型不扣积分无限量使用。

<strong>6、NotebookLM 顶配版与 GoogleSkills 免费实验课额度</strong>

知识库工具 NotebookLM 直接升到最高档，笔记本数量、单本资料上限和每日语音生成次数全部扩大到普通版的 5 倍；另外每月还会发放 GoogleSkills 免费学分用于运行云端实验课，并开放 Chrome、Gmail、Docs 内置 Gemini 以及 Project Mariner 自动操作浏览器的权限。

<strong>7、每月约 420 元人民币拿下顶配</strong>

虽然美区原价是 200 美元，但最近不少网友实测，通过苹果土耳其区 Apple ID 充值礼品卡，先在 Google App 里订一个 9.9 里拉的基础包，再去订阅管理里升级到 Google AI Ultra（30TB 顶配档），每个月只要 2949.99 里拉，折合人民币约 420 元（约 60 美元）

。花 60 美元不仅能用双额度池的 Gemini 4 Carbon 和 Claude Opus 5.5，还能领回 100 美元谷歌云赠金、2500 点 Colab A100 算力和 30TB 云盘。

![](https://xisheng687.github.io/xisheng-notes/assets/posts/2026-11-12-goodbye-claude-hello-gemini-4-carbon/body-06.jpg)

▲ 图来自 xueyu1125，通过土耳其区以约 420 元人民币每月订阅 30TB 顶配 Google AI Ultra

不过温馨提醒一下，这种地区带来的费用差异一直存在，但是账号的稳定性不能保证，所以如果不是主要账号，可以这样去试试薅羊毛，主账号就不建议了。

## 六、总结与一个必改的隐藏设置

整体看下来，如果你平时既要写前后端代码、做网页，又要写中文内容，现阶段把主力工具切到 Google Antigravity 会省心很多。

日常开发和写文章直接用额度充裕的 Gemini 4 Carbon，遇到大型项目用 /swarm 多智能体并行跑，碰到需要交叉验证的复杂问题再切到套餐自带的 Claude Opus 5.5，同时还能把每月赠送的 100 美元谷歌云额度和 Colab 算力充分利用起来。

最后补充一个在刘小排文章评论区看到的实用设置技巧：

Antigravity 客户端和 agy 命令行工具默认的上下文容量只设了 256K，没有默认开启 1M 满血容量。

大家入手之后，可以直接把下面这段话发给 Antigravity，让它自动帮你把全局默认上下文改成满血档位并永久生效：

> 请帮我把本机 Antigravity CLI（agy）的全局默认上下文容量改到 1M 满血档位并永久生效：  
> 1、读取 ~/.gemini/antigravity-cli/settings.json（Windows 为 %USERPROFILE%\\.gemini\antigravity-cli\settings.json；如果文件或目录不存在则新建）。  
> 2、在保留我原有全部配置字段的前提下，合并写入 schema 地址 https://antigravity.google/schemas/v1/settings.json，并将 contextWindow 字段设为 900K（注意：agy 底层 ParsePresetContextWindow 的三个合法枚举是 256K、512K、900K，1M 满血档必须写 900K，严禁写成 1M 否则会静默回退到 256K）。  
> 3、写完后校验 JSON 格式无误，把最终文件内容展示给我，并提示我在 agy 中可用 /context 验证。

END。
