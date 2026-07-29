<audio title="13｜为 AI 股票分析工具装上 Agent（三）：工具建设" src="https://res001.geekbang.org/media/audio/e3/bd/e37b191592162eb4b2780a62e28313bd/ld/ld.m3u8"></audio>

你好，我是产品二姐。

上节课，我们把 Hermes Agent 和 AlphaWiseWin 的用户体系打通了——用户在主站登录，不需要单独注册 chat，直接无缝进入 Agent 对话。但这个 Agent 和通用的 Hermes Agent 能力是一样的，并不具备个性化的能力，接下来的两节课我们就要完成 Agent 的业务融合。也就是我们在 11 讲开头提到的后两件事情：

工具管理方面：将现有 AlphaWiseWin 系统的能力转换为 Agent 可用的工具、让 Agent 优先使用 AlphaWiseWin 自己的工具完成任务。

记忆管理方面：构建 Agent 记忆，让 Agent 能记住用户的喜好、聊天历史，让每个用户感觉到这个 Agent 是为自己而生的。

这节课我们完成工具管理部分，依然循序渐进地带你完成三个步骤：

第一步：先解决上节课留下的一个安全问题：把既有的危险工具在生产环境中禁止使用。我们会过一遍 Hermes 自带的工具，看哪些能在多用户场景下开放、哪些必须禁掉。

第二步：把 AlphaWiseWin 的能力以工具形式开放给 Agent，也就是基于 AlphaWiseWin 现有的接口和数据库信息，搭建出 Agent 可以使用的自建工具。

第三步：验证并调试这些自建工具，让 Agent 在多个工具里优先选择你的自建工具。

学完这节课，你会知道：

在多用户 Agent 中，Agent 工具的安全性该如何评估。

如何为 Agent 构建自身业务的工具，你会发现这和我们原来给前端用的 API 是两种不同的思路。

在 Agent 中，如何让 Agent 尽可能使用正确的工具，你可以理解为提高工具召回准确性的问题。 ![](https://static001.geekbang.org/resource/image/bd/3d/bd1df292910a502ec480yy59d6be553d.png?wh=1852x764)

## 对 Hermes Agent 内置工具做安全过滤

上节课我们是把 Hermes Agent 安装在本地，它可以通过指令 ~mkdir -p 在我们本地创建一个文件夹。

这节课我们要把 Hermes 部署到服务器上，供很多用户使用，如果他们同时发出创建文件夹这类需求的话，那将来我们的服务器上就会布满了各个用户的文件，就容易出现用户 A 创建的文件夹被用户 B 给删掉，这种危险的情况。

借助 AI 工具，我们得知类似这种文件操作指令都被定义在 Hermes Agent 的 file\_tools 工具中，因此上生产环境前，我们必须要把这类危险工具禁用。

实际上，除了文件操作之外，Hermes Agent 内置了多个工具，包括：网络搜索、网页抓取、文件读写、代码执行、终端命令、浏览器控制、图片分析。 我们在上生产环境之前，一定要把所有工具做好安全扫描，即确定哪些工具可以保留，哪些不能保留。

还记得我们在 09 讲写的两个关于工具构建的 Skill 吗，其中一个就是负责安全把控的，我们用这个 Skill 来让 AI 评估，你需要告诉 Codex 或 Claude Code 以下内容：

我要把Hermes Agent项目部署在服务器上供多用户使用，从安全角度考虑， 你使用 /tool-permission-system这个skill判断目前 Hermes Agent内置工具中的哪些skill可以开放给用户，哪些应该严格禁用。

它会回复类似下图的分类标准，把 tools 分为 DENY（必须禁用）、 CONFIRM（需要附加改造后开放）、AUTO-ALLOW（可以直接开放）三种级别。

![](https://static001.geekbang.org/resource/image/f8/33/f835e5a81e092d606e1736b26bca0833.png?wh=1319x2332)

然后，顺着这个思路， AI 会在你的指引下把 ~/.hermes/config.yaml 里的 platform\_toolsets.api\_server 限制成只保留 AUTO-ALLOW 的工具集。

这里你可能注意到了，在 DENY 工具集中有一个 memory 工具被禁用了，这是主动保存用户记忆的功能。在这一节课中我们需要禁用这个工具，而下节课，我们会对 memory 工具进行多用户隔离改造，之后才能开放给用户，这里先别急。

那么，工具的安全配置做完，就可以把 Hermes Agent 和 Open WebUI 部署到生产服务器上了，具体的部署步骤，你可以参考 05 讲 ，完成部署。

对于第一次部署的同学来说，这一步可能会花较长时间，因为需要运行各种产品经理不熟悉的运维指令，比如连接服务器、修改环境变量等。出于安全考虑，我们不会把生产环境的运维权限下放给 Codex，必须亲自来执行，比较花时间。这也是我在上一节课需要你在 Claude Code 或 Codex 的全局记忆（CLAUDE.md/AGENT.md）中加入相关说明的原因。

部署完成后，你可以通过以下四步完成验证：

在主站登录，能不能无缝跳转进 chat，退出主站后，再访问 chat，能不能自动跳回登录页。这是为了验证上一节的用户集成。

进入对话后，输入“你好”，看是否能回复，这是为了验证生产环境的 Hermes Agent 能正常工作。

输入“帮我搜索茅台股票”，看能不能联网搜索，验证 Hermes Agent 能使用搜索工具。

输入“帮我建一个文件夹叫 xxx”，看 Agent 是否答复“我不能创建文件夹”之类的话术，这是验证 Hermes Agent 的危险工具有没有关掉。

验证完成后，意味着 Hermes Agent 在生产环境可以被调用了，但这只是一个通用的被“阉割”了危险工具的 Agent，下一步我们就要基于 AlphaWiseWin 现有的数据基础，构建出面向 Agent 友好的工具，让用户能用上具备 AlphaWiseWin 特色的工具。

## 为 Agent 构建 AlphaWiseWin 的特色工具

我们分三步来构建出面向 Agent 友好的工具，你可以在实践的过程中，顺便复习一下 09 讲工具建设里的内容。

第一步：准备好构建工具的 Skill。

我们在 09 讲总结了一个 Skill，叫 agent-tool-builder，专门用于构建 Agent 工具。但那时的 agent-tool-builder skill 是基于 Claude Code 的源码抽象总结出来的，而此时我们用的是 Hermes Agent 框架，框架中对工具格式有特别的规定。因此，需要适配这个 Skill，你可以用下面的提示词生成一个新的 hermes-tool-builder skill 后，再安装使用。

你看项目 /<>/Hermes Agent 里构建tool的规定，基于/agent-tool-builder 里的工具构建原则，做一个适配Hermes Agent框架的工具构建skill，形成新的hermes-tool-builder skill。

第二步：做工具建设的 tool-build-plan.md。

我们在 09 讲曾重点提到，工具建设要面向 Agent 友好，那就要从用户需求出发来设计。比如用户问：帮我查茅台的近期走势。就需要先根据“茅台”搜索出股票代码，这个搜索是一个工具，然后通过另外一个工具查询 K 线数据。

可以想象，这里会有很多个工具需要做。一次性让 AI 完成风险比较大，所以我们要做一个规划，这样我们可以控制进度，比如先完整地完成一个工具，然后逐步叠加完成全部工具，一边完成，一边让 Agent 更新规划的进度。类似这样在完成长任务时，先做规划也是遵循 Harness Engineering 的原则。

你可以使用 hermes-tool-builder skill 配合下面的提示词，让 Codex 或 Claude Code 阅读 AlphaWiseWin 的代码，设计出整体的工具设计计划。这里，你需要阅读这个提示词，理解其中的含义。

我希望你帮我为 Hermes Agent 基于另一个项目AlphaWiseWin的能力，设计一套完整的工具规划。

背景说明：

Hermes Agent 是一个基于工具注册表机制的 AI Agent 框架。每个工具通过 registry.register()

注册，包含 name、schema、handler、check\_fn 等字段。工具按 toolset 分组，在 config.yaml 的

platform\_toolsets 中启用。

目标项目： \[AlphaWiseWin\]

输出文件： \[~/xxx-tool-build-plan.md\]

\---

请按以下步骤执行：

第一步：深度阅读目标项目代码

\- 梳理项目有哪些数据表/数据模型

\- 读现有 API 路由，理解当前能力

\- 找出项目已有的工具函数/工具库（如计算、解析等）

\- 识别鉴权方式（API Key / JWT / 其他）

第二步：提出确认问题

在设计之前，把以下不确定的事项列成问题问我：

\- Hermes Agent 调用该项目的方式（HTTP API / 直接调库 / 其他）

\- 鉴权 Token 的存放位置和格式

\- 数据实体的 ID 格式约定

\- 哪些功能需要用户上下文（当前登录用户）

\- 现有 API 是否足够 agent 使用，还是需要新增专用端点

等我回答完毕再进入第三步。

第三步：使用 /agent-tool-builder skill 设计工具清单

每个工具必须包含：

\- 工具名（snake\_case）

\- 给 LLM 的 description（包含：优先级声明、触发场景、负面约束"不要用 web\_search

替代"、数据来源说明、下游衔接说明）

\- 数据来源（哪张表 / 哪个接口）

\- 关键参数（参数名、类型、是否必填、默认值）

\- 返回字段（Agent 推理所需的结构化 JSON 字段，不是展示用的字符串）

\- 安全属性（is\_read\_only、is\_concurrency\_safe）

\- Agent 使用场景举例（用户说什么话时应调用此工具）

设计原则：

\- 工具粒度要细，每个工具只做一件事

\- 返回结构化 JSON，不返回 Markdown 格式化文字

\- 模糊查询和精确查询分开成不同工具

\- 依赖用户上下文的工具单独标注，优先级放后

第四步：输出完整规划文档

文档结构如下：

1\. 背景：现有 API 与 Agent 工具的本质区别对比表

2\. 数据层概览（数据表清单）

3\. 工具清单（每个工具一个小节，包含上述所有字段）

4\. Skills 规划（2-3 个复合场景，说明工具调用顺序和输出结构）

5\. 实现路径（文件结构、接入方式、鉴权方案、ID 格式约定）

6\. 优先级排序（P0/P1/P2 分批）

7\. 当前实现状态

8\. 已确认事项（整理我回答的问题）

9\. 待办（目标项目侧需新增的端点清单）

10\. 新增一个工具的完整流程（Step by Step）

完成后将文档保存到指定路径。

最后，我们可能会生成类似下图这样的规划，这里截图我只放了大纲，因为每个人的规划可能会有差异，但大纲是基本一致的。

![](https://static001.geekbang.org/resource/image/7y/19/7yye3012ed36e60eb082cb937f068819.png?wh=878x2334)

第三步：让 AI 按照 tool-build-plan.md 里的内容完成第一个 tool。

在这个案例里完成的第一个 tool 是 stock\_search。从上面的规划文档大纲中，我们能看到新增一个工具的完整流程是这样的：

新增一个工具的完整流程

Step1:stock\_data侧新增Agent端点(如已有端点可跳过)

Step2:本地验证stock\_data接口

Step3:Hermes Agent侧新增工具

Description编写原则(决定模型是否调用这个工具)

Step4:本地测试

Step5:提交并部署到生产

Step6:生产验证一确认工具真正被调用

我在这里稍微解释一下。这里的第一步、第二步和常规接口开发一样，第三步、第四步主要是为 Hermes Agent 开通调用这个接口的权限，我们要为 Hermes Agent 单独签发一个固定的 API key，代表这个 Hermes Agent 可以永久访问这个接口，这个 API key 会像之前你保存大模型的 API key 一样，保存在 Hermes Agent 的环境变量文档 ~/.hermes/.env 中。最后第五步和第六步正常测试。

这里的每一步都可以让 AI 指导你，你只要跟着完成就好。

那么，在第一个工具完成之后，你就可以让 AI 总结一下构建工具过程中的经验教训，放在 tool-build-plan.md 中，然后完成 plan 里的其他工具。

不过，工具完成建设后，我们还需要进行验证，和召回测试。

## 让 Agent 用“对”工具

比如在 AlphaWiseWin 这个案例中，有两个 search 工具，一个是 web\_search，另外一个是自建工具 stock\_search。我发现工具上线后，用户问股票相关的问题，Agent 仍然去调 web\_search，根本没用 stock\_search。

在这里，我们回顾一下 09 讲的内容：模型选工具的唯一依据，是工具的 description。

如果 description 写得模糊，或者没有明确说在什么情况下用，模型会选它认为“最保险”的工具兜底——通常是 web\_search。所以写 description 不能只描述这个工具做什么，还要告诉模型什么时候必须用这个，而不是用别的。好的 description 需要包含 5 个要素：

| 要素 | 作用 | 示例 |
| --- | --- | --- |
| 优先级声明 | 明确告诉模型何时必须用这个工具 | 【股票查询首选工具】 |
| 负面约束 | 排除竞争工具 | 必须优先调用，而非 web\_search |
| 触发场景列举 | 用户说什么时应该调用 | 用户提到任何股票名称或代码时 |
| 数据来源说明 | 增加模型对工具的信任 | 直接查询 ai2alpha 股票数据库 |
| 下游衔接说明 | 告知这个工具在链路中的位置 | 获得代码后，可继续调用 stock\_get\_price |

那么，按照这个原则，stock\_search 的 description 就可以这样写：【股票查询首选工具】按股票名称或代码搜索，直接查询 ai2alpha 股票数据库。用户提到任何股票名称或代码时，必须优先调用此工具，而非使用 web\_search。

加了这句话之后，Agent 就正常调用这个工具了，你也可以让 AI 帮你查 Hermes gateway 的日志来看 stock\_search 工具有没有被真正调用。

![](https://static001.geekbang.org/resource/image/4f/55/4fc9e5d2c0e79a71780398825d015655.png?wh=2266x1192)

到这里，就完成了 AlphaWiseWin 特色工具的建设。最后，让我们来总结一下。

## 总结

这节课通过三步完成了 AlphaWiseWin 特色工具箱的建立。

我们阉割了 Hermes Agent 的危险工具，只保留了安全工具。

我们和 AI 一起阅读 AlphaWiseWin 代码，做出了工具建设计划。

我们对这些工具描述进行优化，让 Agent 用对工具。

在这个过程中，我们并没有像传统教学那样手把手完成，而是提供了一个如何引导 AI 构建工具的过程，比如最开始引导 AI 做安全过滤，后来对 agent-tool-builder 这个 skill 在 Hermes Agent 这个框架下的适配，再后来引导 AI 完成 tool-build-plan。

我想说，在 AI 时代这就是我们的编程方式，要成为全栈的 AI 产品经理，并不是说我们要成为程序员，而是成为引导 AI 编程的人。

下节课，我会继续用这个方式，教你引导 AI 完成 Agent 下一个要素：Memory 系统的建设。

## 课后题

这节课我们把 Hermes 的危险工具分成了三类，其中 DENY 工具是直接禁掉的。但禁掉不代表永远不能用——有些工具只是现在“条件不够”，改造之后完全可以上线，Memory 工具就是一个典型例子。

所以，今天的课后题我想请你打开你的 Hermes Agent 项目，用 Codex 或 Claude Code 找到 DENY 工具列表里你最感兴趣的一个，问它一句：“如果我要在多用户生产环境里安全地开放这个工具，需要做哪些改造？”

然后把 AI 的回答发到留言区。比如我问了 Memory 工具，AI 告诉我至少要做三件事：① 给每个用户建独立的记忆命名空间，写入时带上 user\_id；② 读取时做权限过滤，只返回当前用户的记忆，不能让 A 用户读到 B 用户的投资偏好；③ 删除操作也要加用户归属校验，防止误删。——这恰好就是我们下节课要做的事。

你选了哪个工具？AI 给你的答案是什么？

欢迎你在留言区和我交流。如果觉得有所收获，也可以把课程分享给更多的朋友一起学习。我们下节课见！

公开

同步至部落

取消

完成

0/2000

直线

曲线

AI

2026-07-08给文章提建议

馨冉

Command + Enter 发表

0/2000字符

提交留言

大纲



固定大纲

对 Hermes Agent 内置工具做安全过滤

为 Agent 构建 AlphaWiseWin 的特色工具

让 Agent 用“对”工具

总结

课后题