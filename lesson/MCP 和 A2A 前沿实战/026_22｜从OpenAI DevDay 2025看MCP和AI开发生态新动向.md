# 22｜从OpenAI DevDay 2025看MCP和AI开发生态新动向

原文链接：https://time.geekbang.org/column/article/917948

---

[![](https://static001.geekbang.org/resource/image/ee/f6/eeb98826f17824aa1744d60782ffa1f6.jpg)](https://static001.geekbang.org/resource/image/ee/f6/eeb98826f17824aa1744d60782ffa1f6.jpg)

你好，我是黄佳。

前一阵子，我带着你连续学习了好几篇总结和综述性质的文章，系统性回顾和梳理了 MCP、A2A、AI 领域甚至整个 IT 技术领域从协议到架构，再到权限和安全技术的发展脉络。这让我们这个专栏从第一阶段的动手实战，过渡到了第二阶段的历史沿革和总结。这几篇文章，读起来或许有些厚重，但是它们无疑把我们的认知提升到一个更为广阔的高度。

此刻，我觉得是时候再转变一下思路了——与其继续回头看，不如把目光投向正在发生的变革，写一些当下发生的热点进展，同时也给出相应的一些实战示例，我们在了解 AI 新进展的同时再次动起手来。

这篇文章，我们就好好剖析一下最近引起很大波澜的 OpenAI DevDay 2025。看看大会上有哪些亮点？哪些技术是真正的拐点？它又透露出怎样的未来趋势？这些问题，都值得仔细拆解。

举个例子，就其中一个看似工具整合的简单新能力——App Connector（应用连接器），竟然成了资本市场的点金手指。10 月初那一周，Canva、Figma、Notion 等 AI 应用公司的股价几乎全线暴涨（也还有 AMD、博通等几个被 OpenAI“宣布合作”的硬件供应商），仿佛是个科技公司只要被 OpenAI 随手一点就活了过来、牛了起来。

为什么？因为这一次，OpenAI 不是在“吃掉”这些软件，而是在赋能它们，让 AI 成为它们的超级接口层。——看起来，OpenAI 正在用一种出人意料的方式重新定义 AI 生态系统的游戏规则！

[![](https://static001.geekbang.org/resource/image/19/e8/19a32a80923814da7b3c0b51fd1119e8.png?wh=1183x1139)](https://static001.geekbang.org/resource/image/19/e8/19a32a80923814da7b3c0b51fd1119e8.png?wh=1183x1139)

你是这 400 万个 OpenAI 开发者之一么？

换句话说，AI 不再要替代应用，而是要变成用户和所有应用之间的那双会思考的手。而这背后的技术逻辑，就是我们今天要谈的重点——从模型调用到协议协作，从独立 Agent 到 MCP 生态。

接下来，我们就从这场发布会开始，一步步看清这场变革的底层结构与走向。

### 为什么是 OpenAI DevDay 2025

要理解 2025 年 DevDay 的重要性，我们得先回头看看前两届大会是如何一步步铺路的。看看 OpenAI 开发者日为什么变得越来越有影响力。

[![](https://static001.geekbang.org/resource/image/7b/67/7bcc7213549d39c8414e7ff17b3dbf67.jpg?wh=3529x2533)](https://static001.geekbang.org/resource/image/7b/67/7bcc7213549d39c8414e7ff17b3dbf67.jpg?wh=3529x2533)

2023 年的 DevDay——奠定平台基础：这是一个技术原点——OpenAI 第一次把 GPT 模型从研究范式带进了真正的产品生态。那一年，GPT-4 正式发布，ChatGPT Plus 上线，插件系统初露雏形，开发者第一次看到了一个能“调用外部世界”的模型雏形：能查天气、订餐、写代码。虽然当时的功能还不稳定，但那是 OpenAI 第一次让“模型 ≠ 聊天器”，而是“模型 = 平台接口”的开始。

2024 年的 DevDay——务实的生态系统深耕：这是平台成形的一年。OpenAI 推出了 GPTs、Assistants API 以及 Memory、Code Interpreter 等模块。那时的主题是“让任何人都能打造属于自己的 AI”。开发者从调用 API 的工程师，变成了可以编排逻辑、定义个性化 Agent 的 AI 构筑者。但也正是在这一阶段，系统间的割裂开始显现——每个 Agent 都能跑，却互不相通。

而到了 2025 年，舞台彻底变了。OpenAI 不再只谈模型、API 或插件，而是开始谈连接（Connection）与协作（Collaboration）。从 App Connector 到 MCP（Model Context Protocol），从“我能让模型做什么”，转向“模型如何与万物共生”。这标志着 OpenAI 的战略核心从“模型智能”迁移到了“系统智能”——AI 不再只是一个回答者，而成为整个生态的操作系统。

为什么从 2025 的开发者日开始？因为它已经不再是“发布新模型 / 新 API” 的单点事件，而是在把“模型—工具—应用—生态”连成可落地的闭环。过去一年，大家对“会写提示”“会接个 API” 已经不再满足，我们需要可复用的模式、能跑进生产的架构，以及跨系统协作的协议。

MCP（Model Context Protocol）恰好站在这个拐点：它把“模型如何安全、可控地触达外部世界”这件事，变成有规范、有工具链、有最佳实践可循的工程问题。

开发者日之所以越来越有影响力，核心在三点。

叙事重心转移：从“更聪明的模型”，转到“更可用、更可控的系统”。评测分数不再是主角，可集成、可治理、可观测成了新的硬指标。

范式收敛：工具调用、函数能力、工作流编排、内存与检索、权限与沙箱，这些关键词在不同平台上逐步同构，协议层（如 MCP）成为公约数。

生态放大：官方 SDK、第三方适配器、企业内部平台开始互通。从“各做各的 Agent” 到“跨团队协同的 Agentic 平台”，发布会变成了生态路标。

而在这两条线的交汇处，就是 MCP（当然也会包括 A2A）：

它不是又一套“封装 SDK”，而是让模型与外部工具以“协议”方式协作。

它把“能力发现、调用编排、权限约束、上下文传递”变成可验证、可治理的通道。

它为企业内部“已有系统”和“新一代 Agent 能力”提供最低摩擦的连接层。

因此，毫不夸张的说，“协议化”会成为 Agent 时代的底层共识。

### OpenAI DevDay 2025 带来哪些新动向

在 DevDay 2025 上，OpenAI 发布或强化了多项新技术 / 模块，以下是几个最受关注、最具潜力的方向：

1. Apps in ChatGPT（ChatGPT 内应用） + Apps SDK

这是此次 DevDay 的一个核心突破 —— OpenAI 将 ChatGPT 从一个对话界面向下延展，变成一个可内嵌应用、可扩展功能的平台。用户可以在 ChatGPT 内直接使用第三方服务（如 Canva、Spotify、Zillow、Booking.com 等），开发者可通过新推出的 Apps SDK 将自己应用嵌入 ChatGPT。

在 OpenAI 的演示中，开发者在 ChatGPT 内调用 Canva 来生成海报、设计稿，之后继续让 ChatGPT 基于该结果生成商业推介文案。在 Zillow 演示中，用户可在 ChatGPT 内查看房屋地图、筛选，并继续进行后续对话。Apps in ChatGPT 初始可用应用包括 Booking.com、Canva、Coursera、Expedia、Figma、Spotify、Zillow 等，未来还将继续扩展更多 App。

开发者可以从预览版开始使用 Apps SDK，后续可提交 App 审核进入目录。这个变化意味着，ChatGPT 从一个“语言模型 + 对话接口”的形式，正在变成一个“运行时平台 / 应用框架”——类似于一个 AI 时代的“操作系统”或“超级界面”。这样的转变让 ChatGPT 在某种意义上“挑战操作系统或浏览器”的角色：所有服务都可能集中在 ChatGPT 平台内运行，用户不需要跳出聊天界面就能完成许多任务。

这种策略对开发者而言，可更低门槛地将应用内嵌进 AI 聊天体系，而无需自己构建全栈 UI，从而降低集成成本；对用户而言，减少在多个应用之间切换，提高体验连贯性和效率；对 OpenAI 而言，则大大增强生态粘性、控制力与平台价值，是从“模型 + API 提供商”向 “AI 平台供应商”升级的重要一步。

而上述“宏大愿景”的实现，底层技术无疑将是各个 App 所推出的 MCP 服务支持。当然，后续也有一系列挑战，包括如何定义安全沙箱、如何治理嵌入式应用、资源与权限管控、收费 / 变现机制等，这些都将成为关键。

2. AgentKit、Agent Builder、工作流与智能 Agent

除了应用内嵌，另一个在本次 DevDay 中备受重视的方向是 AgentKit，与之配套的 Agent 构建工具（如 Agent Builder）。

OpenAI 正式发布 AgentKit 的是一个用于构建和部署生产级 AI Agent 的工具包。在 OpenAI 的 DevDay 页面上，也将 AgentKit 列为今年推出的新工具之一。而 OpenAI 在 DevDay 中展示 Agent Builder，则是一种可视化界面的工具，用于以低代码 / 无代码方式组织、调度、连接多个 Agent / 子任务，并可与 MCP 等服务打通。Agent Builder 和 2025 年 3 月推出的 Responses API and Agents SDK⁠  一起，形成了 OpenAI Agent 开发生态中从高代码到低代码的完整闭环。

不难看出，OpenAI 正尝试让 Agent 开发从“手工编码 + 工具编排”向“模块化可视化 + 平台化管理”演进。Agent Builder 的界面被描述为有侧栏组件（palette）、流程预览 / 测试模式、节点连接等功能，有望在短时间内让用户搭出一个可部署的 Agent。这个和我们比较熟悉的 Coze、Dify 等低代码、拖拽式 Agent 开发平台颇为相似。后面，我也将带着你手工实操一次如何在 Agent Builder 中调用 MCP 工具服务。

更广义地看，OpenAI 正在构建一个 Agent 生产线：从定义任务 -> 连接工具 -> 部署运行 -> 监控评估，一气呵成。这个方向是 OpenAI 试图在 Agent 经济时代占据基础设施入口的布局。

但是，这条路并不容易 —— 不同 Agent 之间如何隔离、资源调度、失败重试、状态管理、模型可解释性、错误恢复等都是难题。AgentKit 的推出仅是第一步，下游的治理、运维、生态建设才是长远考验。

3. Sora 2 视频生成模型 API

视频生成一直是近年来 AI 模型领域的一个重难点，而表现好的系统往往能带来极强的感知冲击。OpenAI 在 DevDay 中重推 Sora 2 视频生成模型以及相关 API 接入能力，成为可集成到应用中的视频生成能力模块。

OpenAI 也与玩具公司 Mattel 合作，展示了 Sora 2 在“从草图到动态演示”的创意流程中的潜在落地：设计师画一张初步草图，系统自动生成可看、可分享的动画或视觉演示。这意味着，视频不再仅限于“后期制作”阶段，而可能成为创作流程中的即时输出模块之一。

尽管 Sora 2 展示出巨大潜力，但挑战也很多：视频生成涉及时序一致性、画面连贯性、风格控制、版权、生成内容监管、安全与滥用防范（deepfake 风险）等。如果 OpenAI 能够在实际可用性、质量与安全之间取得良好平衡，Sora 2 将成为一种关键的创作引擎。

4. 硬件产品 / “无屏”设备构想

除了软件与平台层面的突破，本届 DevDay 上，OpenAI 还在硬件方向上做了一些前瞻性布局，尤其是与前苹果设计师 Jony Ive 的合作项目。

在演讲中，Sam Altman 与 Jony Ive 对外宣布他们正在共同开发一类“设备家族”（family of devices），目标并非传统手机或电脑，而是面向情感、交互体验的新型设备。Ive 表示希望这些设备能“让我们更快乐”，而不仅仅是提高效率。虽然具体参数、形态尚未披露，但媒体称这可能是无屏设备、依赖传感器（摄像头、麦克风）与 AI 模型联动的交互系统。

这意味着 OpenAI 正在尝试从仅 “AI 平台 + 服务”跨足 “AI 硬件 + 交互载体”领域，类似于早年谷歌、苹果、Meta 在 AI 设备方面的尝试。

这个方向或许更像一个长期策略赌注：如果成功，将让 OpenAI 更深地介入用户终端体验层。不过，中间要突破的系统性挑战很多：实时处理能力、隐私安全、功耗、热管理、接口、用户交互方式等还在攻关中。 OpenAI 能否在 2026 年末推出这一系列硬件产品，需要攻克诸多技术瓶颈。

5. 基础设施与芯片合作

AI 平台的背后，是对算力、基础设施、存储、网络的巨大诉求。DevDay 上，也有与硬件、基础设施相关的重要合作或公告。

比如，OpenAI 与 AMD 宣布建立芯片供应战略合作，AMD 将为 OpenAI 提供高性能图形 / 加速器芯片（如 Instinct MI450）以支撑下一代 AI 基础设施。OpenAI 将获得高达 6 吉瓦级别的计算能力（首批 1GW 将在 2026 年部署）。同时，OpenAI 拥有按绩效指标购买 AMD 股票的认购权，最高可达 1.6 亿股，约占 AMD 总股本的 10% 左右。

这种合作显示 OpenAI 在硬件供应链上的野心：试图减少对单一供应商（如 NVIDIA）的依赖，同时在未来 AI 基础设施竞争中占据更多筹码。不仅能提升 OpenAI 的算力冗余能力，也可能在未来推动其硬件竞争力与成本控制能力增强。

6. 安全、治理、评估 (Evals) 等辅助系统

在 DevDay 的框架中，除了纯技术模块，OpenAI 也关注模型 与 Agent 系统的安全性、评估能力、规范治理机制等方面。OpenAI 提到 “Introducing AgentKit，new Evals，and RFT for agents” 作为 DevDay 的新产物之一，意味着 OpenAI 不仅要给出 Agent 构建工具，还要提供评估 、测试 、质量控制组件（Evals, RFT 等），以确保 Agent 在真实场景下的可靠性与安全性。

在 Agent 流程中，需要监控节点行为、异常检测、回滚策略、模型可解释性、工具调用的安全边界等。OpenAI 显然希望将这些能力内建于其平台 / SDK 中，以增强开发者的底层保障。这些辅助系统是安身立命的关键：再强大的 Agent 工具若缺乏安全、评估、监控机制，也很难进入企业 / 高标准场景。

以上，就是 2025 OpenAI DevDay 带给我们的 6 大 AI 技术发展新趋势。

### 通过 Agent Builder 连接外部 MCP 服务

好，感受了 OpenAI 的产品阵列以及他在 AI 生态的通吃计划和野心，我这就来选择一个和开发人员最相关的 OpenAI 主流技术产品——Agent Builder，亲自动手感受一下 MCP 技术在其中的无缝集成体验。

通过 OpenAI Platform 中的 Agent Builder 链接，我们可以新建一个工作流。

[![](https://static001.geekbang.org/resource/image/a8/49/a83557abe235563e92aab74e2298bc49.png?wh=1509x980)](https://static001.geekbang.org/resource/image/a8/49/a83557abe235563e92aab74e2298bc49.png?wh=1509x980)

咖哥发言：考虑到国内的小伙伴有可能并不方便访问 OpenAI 的环境，我会尽量多截取一些屏幕。其实，我下面的操作并没有什么技术含量，仅仅是为了展示 MCP 和各个主流 Agent 开发工具的无缝集成，你也可以使用 Dify、Coze 等国内平台做平替。其背后的集成逻辑是完全一致的。

在新建的工作流中，界面十分清爽，目前只有 Start 和 Agent 两个节点。

[![](https://static001.geekbang.org/resource/image/2d/7e/2d73236ee305dfe153680d3660f5c57e.png?wh=1515x779)](https://static001.geekbang.org/resource/image/2d/7e/2d73236ee305dfe153680d3660f5c57e.png?wh=1515x779)

Agent Builder 中包含要设计 Agentic 工作流所需的一系列节点。

1. Core 核心节点

这些节点是工作流的“骨架层”，控制流程起点、主要智能体和终点。

[![](https://static001.geekbang.org/resource/image/87/yy/874yyb9719b6b7caa5104714588be3yy.jpg?wh=4449x1684)](https://static001.geekbang.org/resource/image/87/yy/874yyb9719b6b7caa5104714588be3yy.jpg?wh=4449x1684)

2. Tools 工具节点

这些是“系统级能力模块”，是工作流的能力层，让 Agent 能与外部世界互动，让 Agent 真正能“干活”。

[![](https://static001.geekbang.org/resource/image/9d/40/9d1e833d1923e675acb124b927a95040.jpg?wh=4449x1776)](https://static001.geekbang.org/resource/image/9d/40/9d1e833d1923e675acb124b927a95040.jpg?wh=4449x1776)

3. Logic 逻辑节点

逻辑节点控制执行流程、分支条件和用户干预。这是工作流“决策层”，让工作流具备智能控制与交互能力。

[![](https://static001.geekbang.org/resource/image/cd/c3/cd2c343b7e8ddb63318b74431a8c64c3.jpg?wh=4449x1742)](https://static001.geekbang.org/resource/image/cd/c3/cd2c343b7e8ddb63318b74431a8c64c3.jpg?wh=4449x1742)

4. Data 数据处理节点

主要负责数据的格式化、状态保存和变量传递，是工作流的“数据管道层”，连接各节点的数据流。

[![](https://static001.geekbang.org/resource/image/6y/0c/6yy86a24004e9a15e9fe8617ecdc1c0c.jpg?wh=4387x1754)](https://static001.geekbang.org/resource/image/6y/0c/6yy86a24004e9a15e9fe8617ecdc1c0c.jpg?wh=4387x1754)

我们主要是想看看 Agent 内部怎么调用 MCP 工具。下面就双击 My agent 节点，然后可以看到 Agent 的名称，Instructions（提示词），Model (gpt-4o) 等等，而最关键的，我们要为这个 Agent 配置上一系列工具，也就是它的能力。

[![](https://static001.geekbang.org/resource/image/ee/c3/eec277c76a4f780d4355aa3d803afec3.png?wh=1126x739)](https://static001.geekbang.org/resource/image/ee/c3/eec277c76a4f780d4355aa3d803afec3.png?wh=1126x739)

因此我选择 Tools 前面的加号，可以看到文件搜索、联网搜索等一系列工具。而在 Hosted 部分的第一个选项，就是 MCP server。

[![](https://static001.geekbang.org/resource/image/f4/a7/f480a328815f6d47124a4ddec2deb5a7.png?wh=582x620)](https://static001.geekbang.org/resource/image/f4/a7/f480a328815f6d47124a4ddec2deb5a7.png?wh=582x620)

OpenAI 直接提供的 MCP Server

[![](https://static001.geekbang.org/resource/image/19/84/19b2d89855ceb6cc273c1fdae303ae84.png?wh=576x591)](https://static001.geekbang.org/resource/image/19/84/19b2d89855ceb6cc273c1fdae303ae84.png?wh=576x591)

其它开发者提供的MCP Server

首先明确下面的目标——我们要做的，是在 OpenAI Agent Builder（或 MCP 兼容平台）中让 Agent 能够通过 MCP 访问 Gmail。

比如：

搜索邮件（search messages）

读取最近邮件（read recent emails）

那么我就选择 Gmail 这个 MCP Server，进入下面的对话框（“Connect to Gmail MCP”）。这就是 MCP Connector 的连接配置窗口，它在背后通过 OAuth2 验证来授权访问 Gmail。

为了安全，MCP 不会直接保存用户名和密码，而是使用 Google OAuth2 授权机制。

你必须先生成一个临时 Access Token，让 MCP 连接 Gmail API。

下面跟着我一步步走完这个过程就好。

[![](https://static001.geekbang.org/resource/image/11/ef/11f62b4d61843ed495e014e31d0434ef.png?wh=534x579)](https://static001.geekbang.org/resource/image/11/ef/11f62b4d61843ed495e014e31d0434ef.png?wh=534x579)

点击 Get access token，进入 Google Developers 的 OAuth 2.0 Playground 页面，是你去生成 Access Token（访问令牌） 的页面。

[![](https://static001.geekbang.org/resource/image/71/f1/7162c2ef32a39b3054c98b22afa4ecf1.png?wh=695x1215)](https://static001.geekbang.org/resource/image/71/f1/7162c2ef32a39b3054c98b22afa4ecf1.png?wh=695x1215)

我们需要在 Google OAuth 2.0 Playground 中选择正确的 API。图中，左侧是 Google 所有 API 的列表，而我们应该滚动页面找到并选择：Gmail API v1 （是专门的 Gmail 服务接口。），而不是 “API Gateway”“Admin SDK”“AdWords” 等。

可以勾选以下 scope（访问权限）：

https:

https:

https:

如果你只需要读取邮件、搜索消息，可以只勾：

https:

[![](https://static001.geekbang.org/resource/image/b6/b0/b60e59c3cb2bf09809427f724178aeb0.png?wh=484x705)](https://static001.geekbang.org/resource/image/b6/b0/b60e59c3cb2bf09809427f724178aeb0.png?wh=484x705)

点击下方蓝色按钮 Authorize APIs。然后选择账号，再继续。

[![](https://static001.geekbang.org/resource/image/fd/ba/fd6b11704bda462e6561c7f89a0d9dba.png?wh=830x297)](https://static001.geekbang.org/resource/image/fd/ba/fd6b11704bda462e6561c7f89a0d9dba.png?wh=830x297)

[![](https://static001.geekbang.org/resource/image/cf/c2/cffbb75f6b145b25f173b13c9eb30dc2.png?wh=716x1257)](https://static001.geekbang.org/resource/image/cf/c2/cffbb75f6b145b25f173b13c9eb30dc2.png?wh=716x1257)

此时，就来到了 Step2，此时，选择 Exchage authorization code for tokens，就可以得到我们需要的 access token 了。

[![](https://static001.geekbang.org/resource/image/e4/ed/e447a4c47c9da3df3a989a2ee6a453ed.png?wh=1719x571)](https://static001.geekbang.org/resource/image/e4/ed/e447a4c47c9da3df3a989a2ee6a453ed.png?wh=1719x571)

[![](https://static001.geekbang.org/resource/image/6f/e0/6f7a3fd61ab295e1f24c7be805d253e0.png?wh=1711x787)](https://static001.geekbang.org/resource/image/6f/e0/6f7a3fd61ab295e1f24c7be805d253e0.png?wh=1711x787)

终于，我们可以把 Token 拷贝到 “Connect to Gmail MCP” 对话框中了！

[![](https://static001.geekbang.org/resource/image/75/05/75dyybce877cc3b3d4d9fe8e17707905.png?wh=1718x928)](https://static001.geekbang.org/resource/image/75/05/75dyybce877cc3b3d4d9fe8e17707905.png?wh=1718x928)

点击 Connect，系统提示 Establishing Connection! —— 这说明我们的连接成功！

因为这个 MCP 工具是集成到了当前 Agent 内部（另一种方式则是通过 Agent Builder 中右边栏的 MCP 节点来创建独立于某个 Agent 的的 MCP 工具，通过工作流来控制何时来调用它），因此这个 Agent 应该能够自动完成以下任务。

接收输入（用户问题或触发指令）。

调用 Gmail MCP（比如 batch_read_email）。

输出处理后的结果。

当然，我们也可以在 “Instructions（说明 / 角色定义）” 中填写类型下面的信息，确保 Agent 真正“会用”这个 Gmail 工具。

You are an assistant that can read and summarize emails from Gmail.

When user asks about their recent emails, call the Gmail MCP tool to get messages.

我的看法是，无论写不写 Insturction，Agent 都会知道何时自动调用 MCP 工具，因为这是它能力的一部分。

[![](https://static001.geekbang.org/resource/image/c7/e3/c731a53359e95d395372342eb92007e3.png?wh=373x569)](https://static001.geekbang.org/resource/image/c7/e3/c731a53359e95d395372342eb92007e3.png?wh=373x569)

最后，我们添加一个 End 节点，选择 Agent 调用工具之后的输出 output_text，试图展示搜寻到的 Email。

[![](https://static001.geekbang.org/resource/image/37/ed/3709060b01578f5fbb468eee597486ed.png?wh=1054x838)](https://static001.geekbang.org/resource/image/37/ed/3709060b01578f5fbb468eee597486ed.png?wh=1054x838)

好了，一个非常简单的 Agent 配置完成，它只是能接收用户的 input，利用自己的能力来确定调用哪个 Gmail API（通过 MCP 服务），然后输出 MCP 工具返回的结果。

[![](https://static001.geekbang.org/resource/image/7e/a5/7e27d987daeb02c6b028d8a7a90e57a5.png?wh=452x418)](https://static001.geekbang.org/resource/image/7e/a5/7e27d987daeb02c6b028d8a7a90e57a5.png?wh=452x418)

最后我们通过 Preview 模式来测试运行这个 Agent。点击右上角 Preview ：

输入一句自然语言，例如：

查看我最近收到的邮件。

之后，可以观察 Agent 的行为。 它应该会自动识别意图、调用 Gmail MCP、 取回邮件、返回内容（比较完善的设置是通过工作流步骤，返回自然语言总结，其实我并没有做这一步的配置）。

可以看到，根据用户的输入，Agent 自行决定调用 Gmail MCP 服务中的 get_recent_mails 工具。

[![](https://static001.geekbang.org/resource/image/e8/8a/e8f18666e2fe0f06265802fe7152ee8a.png?wh=1711x746)](https://static001.geekbang.org/resource/image/e8/8a/e8f18666e2fe0f06265802fe7152ee8a.png?wh=1711x746)

在 Agent Builder 的预览测试页面中，单击箭头所示部分，可以进一步查看 MCP 工具调用的详细日志。

[![](https://static001.geekbang.org/resource/image/e7/c2/e7e70c60a8960ea9f38c247c511429c2.png?wh=646x347)](https://static001.geekbang.org/resource/image/e7/c2/e7e70c60a8960ea9f38c247c511429c2.png?wh=646x347)

[![](https://static001.geekbang.org/resource/image/06/db/0617dba3a9fcfc4255dd9a66d1256ddb.png?wh=1718x1091)](https://static001.geekbang.org/resource/image/06/db/0617dba3a9fcfc4255dd9a66d1256ddb.png?wh=1718x1091)

好，我们的 Agent Builder 实战就暂时告一段落，尽管我的 Agent 既简单又粗糙，但是相信大家也看到了 OpenAI，以及所有其它开放式 Agent 低代码平台是如何集成外部 MCP 服务的，这才是我所想介绍的重点。

### 总结一下

在了解了 OpenAI 最新发布的产品和技术阵列，同时新手实操了一下 Agent Builder 和 MCP Server 的集成之后，我们可以从战略与生态层面对这场 DevDay 的意义做更深入的解读。

1. 平台化 / 生态化的加速

OpenAI 明显在向 AI 平台方向努力：不再仅仅是模型 + 接口，而是构建一个覆盖模型、应用、Agent、评估、安全、硬件等维度的综合平台。

Apps in ChatGPT 是平台入口扩展；AgentKit + Agent 构建工具是内部工作流；基础设施合作与芯片布局是平台级支撑；评估、安全模块则是平台稳定性与可信赖性的保障。整个路线图是一个自上而下、有机联通的 AI 工具链与生态系统。

若能成功，这意味着开发者与用户将在这个平台上快速构建、扩展、运行自己的 AI 应用或 Agent，形成类似 “AI 应用商店 / AI 生态市场” 的架构。这种转型也意味着 OpenAI 在行业中的话语权与平台锁定能力将进一步增强。

2. 与 MCP / 开放标准 / 生态合作的契合（与竞争）

在这个大会中，OpenAI 在不少地方提及对外部工具、协议、标准的兼容性或整合可能性。其中，MCP（Model Context Protocol，模型上下文协议 、模型工具调用标准）是一个最值得重点关注的技术生态。后面我们还会详细讨论 MCP 的最新发展和风险。

从公开报道看，OpenAI 在其 Agent SDK 、AgentKit、应用集成层面，已经将对 MCP 的支持或兼容性大幅提升。这一点从 OpenAI 改写其 SDK 文档、提供 MCP 服务整合指南、以及社区报告来看已经发生。

从战略视角，这种兼容、接纳 MCP 的策略，有以下可能动机：

通过兼容开放标准减小社区阻力，让更多使用 MCP 的系统或工具能无缝接入 OpenAI 体系。

利用标准化协议降低边界摩擦，提高跨平台与跨模型工具调用效率。

在 AI Agent 产业标准竞争中，不直接对抗 MCP，而是作为共建者角色，从内部获得标准话语权。

不过，需要警惕的是，兼容与内置不是同一个概念。OpenAI 在兼容 MCP 的同时，也可能在其平台内部通过封装、转换、治理机制设定自己的“闭环”方式，从而在控制力与灵活性之间寻找平衡。

3. 从“模型 + 接口”到“应用 + Agent + 生态 + 入口”的跃迁

如果把 OpenAI 的发展路径简化为阶段性演进，那么此次 DevDay 标志着一个较为明确的阶段跃迁：

原始阶段：OpenAI 主要聚焦于训练更强模型、提供 API 接口。

中间阶段：OpenAI 开始强化工具调用、函数接口、微调能力、Prompt 工具链支持等。

平台阶段（当前趋势）：OpenAI 正将自己塑造成一个 AI 平台或者说生态枢纽，承载上层 AI 应用和 Agent 的构建与部署。

终端触达阶段（部分尝试）：通过硬件设备和物理载体试探未来人机交互的新形态。

从这个角度看，DevDay 2025 正是 OpenAI 加速由中间层向平台层跃迁的关键节点。对开发者而言，这是一个颇具挑战与机遇并存的时期：在这种平台化转型中，如何抓住入口、如何在碎片化生态中占据优势、如何在平台与标准之间保持灵活性，都是关键考验。

虽然 DevDay 布局极具野心，但挑战与风险同样浓厚。以下是我观察到一些可能的障碍或需要关注的点：

安全、滥用、监管方面的风险。嵌入式应用、Agent 调用外部资源、自动化动作执行——这些都可能成为滥用入口、攻击边界、隐私泄露点。如何在平台层做好权限沙箱、调用隔离、输入与输出监控、异常回滚等，是考验 OpenAI 平台能力的重要维度。

应用生态拉动与变现机制。即便 Apps in ChatGPT 构建了入口，如果生态中没有足够高质量、差异化、事件级应用吸引用户，那么平台吸引力会受限。变现机制如何设计（抽成、订阅、API 费用分红等）也会影响开发者动力。

平台锁定 vs 开放性平衡。为了保持平台稳定与一致性，OpenAI 会倾向于封装、管控、审查、设计自己的标准流程。但这可能与开放生态精神、开发者自由权之间产生张力。如果平台过度封闭，可能阻碍外部创新。

算力和成本压力。嵌入式应用、Agent 运行、视频生成模型、硬件设备等，都对计算资源和成本提出极高要求。OpenAI 与 AMD 合作是缓解举措之一，但如何让平台长期可持续，仍需精细的资源调度与成本分摊策略。

多模型 / 多标准兼容性。在未来可能存在多个大型模型供应商、多个协议标准（如 MCP、A2A、内部函数接口等），OpenAI 如何保持兼容性与竞争力是一大考验。

用户体验与交互设计。将 AI 能力以高质量、连贯、低摩擦方式嵌入 ChatGPT 中，需要在对话逻辑、UI 体验、跨应用状态管理、错误恢复机制等诸多方面下功夫。一个不成熟的体验可能削弱用户对这个平台的信任。

总之，在未来 3~5 年， ChatGPT 将越来越像一个 “AI 操作系统”或 “AI 应用平台”，承载更多服务入口、Agent 协作和内容创作工具。Agent / 智能体将从实验形态向可用产品形态演进，AgentKit 与 Agent Builder 是关键跳板。

在生态扩展层面，OpenAI 会寻求在兼容主流协议 / 工具（如 MCP 等）与自身平台控制力之间建立平衡，以既能吸纳外部创新，又能保持平台优势。这些策略最终成功与否，将取决于未来这些模块能否在真实场景中落地、稳定运行并获得开发者与用户的广泛认可。

### 思考题

其实我也已经说了，我的 Agent 创建得简单粗糙，希望你进一步的探索 Open AI 的 Agent Builder 的完整功能，或者任何开放式的 Agent 低代码平台，集成他们所提供的 MCP 工具，构建出各种各样的 Agent，然后分享你的经验。

尝试使用 OpenAI 的 AgentKit 来构建智能体，比如ChatKit Python SDK  和  OpenAI Agents SDK for Python，并且也尝试在开发过程中集成外部 MCP 工具。

对于 Agent、MCP 以及 AI 应用开发的未来发展，你有哪些属于自己的趋势判断和展望？

非常希望在留言区看到你的分享。也推荐你把今天的内容分享给身边的朋友。

[![](https://static001.geekbang.org/resource/image/83/64/833ebd1187590c6d8ff52e9256a69a64.png)](https://static001.geekbang.org/resource/image/83/64/833ebd1187590c6d8ff52e9256a69a64.png)
