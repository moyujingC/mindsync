生产级 Agent 排雷实战

李号双

eBay 资深架构师

2053 人已学习

查看详情

课程目录

已完结/共 25 讲

开篇词 (1讲)



时长 11:26

地基，给 Loop 装上刹车 (1讲)



时长 10:18

工具调用与执行 (3讲)



时长 09:02

时长 13:11

时长 13:49

上下文、记忆与知识 (3讲)



时长 16:18

1%

时长 13:26

16%

时长 11:45

任务规划与多 Agent 编排 (3讲)



时长 12:12

时长 18:31

时长 13:48

权限、审批与安全 (3讲)



时长 14:23

时长 08:49

时长 12:43

3%

韧性、成本与可观测性 (4讲)



时长 14:32

时长 15:52

时长 16:35

时长 09:16

测试、评估、训练与闭环 (3讲)



时长 16:19

时长 13:55

时长 16:31

结束语&测试题 (2讲)



时长 04:18

时长 00:29

思考题答案 (2讲)



时长 58:37

时长 29:38

李号双

## 11｜长任务 OBO 令牌过期，TTL 能否直接拉到 2 小时

思考题原文：

在这一课里，我们使用了 OBO（On-Behalf-Of）令牌交换机制，确保 Agent 只持有短期的、绑定特定任务的权限凭证。这带来了一个实际的工程挑战：如果某个长程任务（比如需要 Agent 调用多个工具，分步骤完成一个复杂的数据分析报告，总耗时可能超过 1 小时），而我们颁发的 OBO 令牌 TTL（过期时间）默认只有 15 分钟。 当 Agent 执行到一半，令牌过期了，导致后续的工具调用全部失败，任务中断。

请问：直接把 TTL 设置为 2 小时是一个好的解决方案吗？如果不是，我们应该设计怎样的“令牌续期”或“长任务管理”机制，才能既保证长任务的平稳运行，又不破坏“权限随任务生灭、最小权限原则”的安全边界？

参考答案：

直接把 TTL 拉到 2 小时不是好办法，它只是把令牌被盗后的可用窗口放大，也让任务中途吊销和条件访问失效。令牌应保存在网关，Agent 只拿任务委托句柄；access token 继续使用平台建议的短 TTL，通常数分钟到 1 小时，到期前由网关用 refresh token 或重新 token exchange 换新。每次续期都重新校验用户委托、Agent 身份、任务状态、MFA/ 条件访问、scope、空闲时间和总生命周期，scope 只减不增。用户撤销、登出、策略变化、任务异常或续期失败就熔断并吊销令牌。长任务还要有最大时长和预算，Checkpoint 里不存令牌，只存可重建委托关系的信息。

参考来源：

https://www.rfc-editor.org/rfc/rfc8693.html

https://docs.azure.cn/en-us/entra/identity-platform/v2-oauth2-on-behalf-of-flow

https://learn.microsoft.com/en-ca/Entra/agent-id/agent-on-behalf-of-oauth-flow

## 12｜如何识别单步合规、组合违规的复合风险

思考题原文：

在本课中，我们建立了针对单个工具调用（如 execute\_sql）的审批机制。然而，高级的风险往往隐藏在一系列看似“安全”的操作序列中。

例如，Agent 先调用 read\_customer\_data（读操作，低风险，自动放行），紧接着调用 send\_email（发送操作，低风险，自动放行）。单独看每一步都合规，但组合起来却是严重的“数据泄露”。

既然我们的 MCP Gateway 和策略引擎主要拦截单次调用，架构应如何演进以识别和治理这种“复合风险”？

参考答案：

单调用 DLP 只能看见一封“正常邮件”，看不见这封邮件的数据是上一步从客户库里读出来的，所以网关要从无状态检查升级成会话级数据流跟踪。读工具返回时，就给敏感字段打来源、等级和血缘句柄；任何邮件、Webhook、上传等出站调用前，同时做内容 DLP 和血缘检查，再用滑动窗口识别“高敏读取后短时间内外发”“分批拉取后集中发送”等序列。命中后按风险脱敏、阻断、降级或转人工，读令牌和外发令牌也应分开，Plan 里若预先包含导出动作要提前授权。最后要封死 Agent 直连出口，否则网关看不到旁路流量。

参考来源：

https://attack.mitre.org/techniques/T1041/

https://attack.mitre.org/techniques/T1020/

https://modelcontextprotocol.io/specification/2025-11-25/basic/authorization

## 13｜三维可信度权重如何按业务调优

思考题原文：

零信任体系的核心是可信度分数，但有个问题：三个维度的权重怎么定？内容、来源、行为，各占多少比例？支付场景和内部问答场景的权重肯定不一样，但具体怎么调？请你设计一套权重调优机制，让不同业务线能根据自己的风险偏好和误报容忍度，找到适合自己的三维度权重组合。

提示：可以从“先给保守默认值，再用 A/B 测试对比误报率和漏报率”的角度想，也可以考虑让业务方用“我愿意为降低 1% 漏报率承受多少误报率”这种偏好表达来反推权重。

参考答案：

权重不能全公司拍一个固定值，它本质上是成本敏感的分类阈值问题。先把注入载荷命中、硬授权失败、明确敏感数据外发这类确定性红线独立出来，命中即拦，不参与加权投票。其他内容、来源、行为信号，用红队样本、真实事故和正常流量建立标注集，先影子运行只记录不阻断；再扫描不同权重和阈值，统计误报、漏报并画 ROC/PR 曲线。业务方只需要给出一次漏报相当于多少次误报的成本比，系统按期望成本最小化选工作点。支付场景偏保守，内部问答可以先观察；灰度后误报超过 SLA 就回退，新攻击样本持续重标定。

参考来源：

https://scikit-learn.org/stable/modules/classification\_threshold.html

https://developers.google.com/machine-learning/crash-course/classification/roc-and-auc

## 14｜长时间挂起后 Checkpoint 过期怎么办

思考题原文：

我们用六层状态 + Checkpoint/Event 解决了“随时崩溃、无损续跑”。但有个场景：Agent 处理一个高额退款请求，查询订单状态为“已发货”，于是将完整 Session 序列化为 Checkpoint，进入 SUSPENDED 等待审批。审批人在开会，2 小时后才批准。

Agent 从 Checkpoint 恢复，继续执行退款。但这 2 小时内，物流系统已把订单更新为“已签收”，业务规则规定“已签收订单需走售后返修，不可直接全额退款”。

问题：Agent 手里的 Checkpoint 是 2 小时前的“绝对真理”，但执行时物理世界已变。直接恢复执行会导致基于过期状态的危险操作。在“长时间挂起 + Checkpoint 恢复”的架构下，你怎么防范这种“状态过期”？是恢复后强制重新校验前置状态，还是在外部系统加锁？如果重新校验发现状态已变，这算执行成功还是失败？

参考答案：

Checkpoint 只能告诉系统从哪里恢复，不能代表外部世界现在是什么样。它应保存执行位置、幂等键、业务键和当时读到的版本号 / 更新时间；从 SUSPENDED 恢复后、执行退款前，必须用订单号重读权威状态，并带版本做条件写。只有状态仍是“已发货”、版本未变、政策未变，才允许退款；如果已经变成“已签收”，说明原审批的前置条件失效，原 Plan 作废，转售后返修并重新审批。这既不算执行成功，也不是系统失败，而应记为 PRECONDITION\_FAILED。长挂起不适合持有悲观锁，外部退款接口仍沿用原幂等键防重复。

参考来源：

https://docs.aws.amazon.com/amazondynamodb/latest/developerguide/BestPractices\_OptimisticLocking.html

https://docs.aws.amazon.com/amazondynamodb/latest/developerguide/WorkingWithItems.html?language=en\_US

## 15｜如何区分真实推进和表演式忙碌

思考题原文：

我们用“单次任务预算熔断”解决了死循环烧钱的问题，又用“动态预算”尝试区分合法长任务和非法死循环。但动态预算的进度评估本身有个难题：怎么判断 Agent 是“真的在推进”还是“假装在推进”？

假设 Agent 为了骗取追加预算，每轮都调用一个“看起来有进展”的工具（比如反复搜索不同关键词），但实际上没有获取任何新信息。它的动作指纹在变，工具调用在增加，可任务实质没有推进。

请你设计一个“进度真实性评估器”，能区分“真实推进”和“表演式忙碌”。给你一个提示：单独看每轮调用都是无辜的，但把一串调用的信息增益放在一起看，会留下痕迹——真正的推进会带来新的状态变化、新的知识获取，而表演式忙碌只是在重复已知信息的不同排列。

参考答案：

数工具调用次数或比对动作指纹都容易被骗，模型每轮换关键词就能制造忙碌假象。进度评估要围绕目标状态：每个里程碑先定义可验证退出条件，工具结果统一归一成新实体、新字段、证据 ID/URL、内容哈希、代码 diff、测试结果、工单状态和外部系统状态变化，再做确定性去重，语义相似度只作辅助。连续 K 轮没有新证据、没有状态迁移、Plan 剩余路径也不变，即使调用数在涨，也判定为零信息增益，拒绝追加预算。合法等待外部事件必须声明等待对象、超时和退避策略；关键里程碑仍由独立探针或 Checker 验收。

参考来源：

https://claude.com/blog/building-effective-human-agent-teams

https://www.anthropic.com/research/trustworthy-agents?hl=en-US

## 16｜Prompt 升级后黄金轨迹大面积偏离怎么办

思考题原文：

漂移检测的前提是拥有一批人工标注的黄金轨迹。但当 Prompt 从 v2.1 升级到 v2.2、改变了退款策略判定逻辑时，新 Trace 必然与旧黄金轨迹大面积偏离，Evaluator 会误报并阻断灰度发布。

你该如何设计黄金轨迹的版本化隔离或自动迭代更新机制？在人工标注成本高和自动学习可能引入脏数据之间，如何设计一个半自动的更新管线？提示：可以从 Dataset 版本管理、Prompt 版本与 Dataset 的关联、人工审核 + 自动候选的标注流程这几个角度思考。

参考答案：

只给数据集加内容哈希还不够，Prompt、Dataset、Evaluator 必须绑成版本三元组，否则分数没有可比性。发布 v2.2 时冻结对应数据集：v2.1 对旧集做回归，v2.2 的新 Trace 只对新集评估；策略变化先产出 policy diff，圈出受影响用例。生产 Trace 可以经聚类、去重后生成候选 gold，LLM 也能写差异说明，但成功 Trace 不等于正确 Trace，必须人工审核后才能进入新数据集。未审核候选只作参考，不参与灰度阻断；核心安全用例不能自动修改，旧数据集保留用于回滚和审计。

参考来源：

https://docs.langchain.com/langsmith/manage-prompts

https://docs.langchain.com/langsmith/manage-datasets

https://docs.smith.langchain.com/tutorials/Developers/backtesting

## 17｜ChainOptimizer 冷启动期怎么运行

思考题原文：

反馈层靠生产数据挖反模式、写规则，但有个“冷启动”问题：系统刚上线时没有生产数据，规则库是空的，阈值只能拍脑袋；而拍脑袋的阈值可能导致大量误报或漏报，反过来影响生产数据的质量。

问题：你怎么设计 ChainOptimizer 的冷启动策略，让系统在没足够生产数据时也能合理运行，随着数据积累再平滑过渡到数据驱动？提示：可以从“保守阈值加观察模式”起步、用合成数据预校准、人工审核队列做过渡期兜底这几个角度想。

参考答案：

冷启动不等于只能拍脑袋。DAG 无环、高危操作前审批、写操作幂等、补偿存在、关键路径上限、外部依赖数量限制这类结构性规则，第一天就可以硬拦，因为它们不依赖线上数据。需要学习的是启发式评分：先用专家模板、合成好 / 坏 Plan 和少量人工种子集预校准，上线初期只 WARN 不阻断，边界案例全部进人工队列。人工结论回流后，按业务域统计误报和漏报、调整阈值，稳定规则再逐步升级成 CRITICAL 门禁。合成数据只补稀有反例，不能代表线上分布；紧急场景始终保留人工通道。

参考来源：

https://developer.nvidia.com/blog/evaluating-and-enhancing-rag-pipeline-performance-using-synthetic-data

https://www.anthropic.com/research/trustworthy-agents?hl=en-US

## 18｜如何挡住不在黑名单里的隐性越权副作用

思考题原文：

最后留个问题，不用急着回答，带着它去看你自己的 Agent。“定义禁止而非允许”这套哲学很有力，但现实里，“禁止”清单本身很难枚举干净。还是拿退款举例：我们禁止 Agent 调 delete\_user\_account，这条没问题。可万一它调的是 update\_user\_account 呢？表面看这个工具人畜无害，但它在退款过程里“顺手”把用户的 VIP 等级改成了普通会员。这当然也是违规，是一次越权的副作用，可它并不在你的禁止清单上，而你也不可能把所有会产生副作用的调用一个个列进黑名单。

问题来了：能不能设计一种机制，不用枚举所有“禁止的副作用”，就能保证 Agent 每次工具调用的参数都落在预期范围内，把这种不显性的越权也挡在外面？

参考答案：

黑名单枚举不完，问题的关键是“白工具、黑参数”。最优先是按业务动作拆窄工具：退款上下文只给 process\_refund，修改会员等级另做工具、另走授权。确实需要宽工具时，按 Plan 步骤签发 per-tool、per-resource、per-field scope 和字段掩码，未声明字段直接拒绝，而不是悄悄剥离。strict schema 负责类型、枚举和值域，服务端策略再检查订单状态、操作者身份以及允许的状态 delta；高危写入前可以先 dry-run diff，执行后比对真实状态变化。测试也要断言本次调用只允许产生哪些副作用。

参考来源：

https://platform.claude.com/docs/en/agents-and-tools/tool-use/strict-tool-use

https://modelcontextprotocol.io/specification/2025-11-25/basic/authorization

https://owasp.org/API-Security/editions/2023/en/0xa3-broken-object-property-level-authorization/

## 19｜如何自动识别可能过期的 gold 用例

思考题原文：

最后留个问题，带着它去看看你自己的 Dataset。

数据层我们设计了 review\_status 和 confidence，要求生产 Trace 入库必须人工审核才能升 gold。但现实里，Agent 的行为是动态演进的：今天审核通过的 gold 用例，三个月后业务规则一变，它可能反而成了“错误答案”。想象你维护着一个 500 条用例的 Dataset，每条都定期人工复审，成本高到扛不住；可要是不复审，过期的 gold 会在回归检测里把正确的新行为误判成退化。

你能不能设计一种“用例健康度”机制，自动识别哪些 gold 可能已经过期、主动提醒复审？换句话说，在“全量人工复审太贵”和“过期用例污染评估”之间，怎么搭一条可持续的 Dataset 维护流程？

参考答案：

全量定期复审扛不住，但让系统按模型新输出自动改 gold 更危险，会把评估集改造成迎合模型的样子。更合适的是给每条 gold 建健康度：记录业务域、owner、最后审核时间，以及依赖的政策、Prompt、工具 schema 版本、历史失败率和生产分布偏差。依赖版本变更、线上 Trace 与 gold 成簇偏离、Judge 分歧升高、工具字段失效、输入分布漂移或长期未审时，就降低健康分并送入复审队列。系统只标记“可能过期”，由人判断是模型退化、gold 过期还是有意策略变更；确认后再创建新版本并用 replaces 指向旧用例，核心安全用例不自动隔离。

参考来源：

https://docs.langchain.com/langsmith/manage-datasets

https://docs.langchain.com/langsmith/run-backtests-new-agent

https://www.promptfoo.dev/docs/configuration/test-cases/

## 20｜矛盾 Skill 漏检后，运行时如何确定性仲裁

思考题原文：

我们用矛盾检测解决了 Skill 自相矛盾的问题，但矛盾检测本身依赖 LLM 的判断，它可能漏掉冲突，也可能误判两个不冲突的指令为冲突。

假设 LLM 在 patch 时漏掉了一个真实冲突，两条矛盾的指令同时存在于 Skill 中。Agent 执行时，它会随机选一条执行，导致行为不稳定，有时候查 Sentinel，有时候查 Cluster，完全不可预测。

在无法保证 LLM 矛盾检测 100% 准确的前提下，设计一种“运行时冲突仲裁”机制，让 Agent 在遇到矛盾 Skill 时不会随机选择，而是有一个确定性的仲裁策略。提示：结构化 Skill 的前置条件和版本号可以作为仲裁依据——新版本的条件分支应该覆盖旧版本的无条件指令，但怎么让 Agent 在运行时“知道”哪个是新版本、哪个该优先？

参考答案：

运行时不能把两条矛盾指令都塞给模型，让它凭概率挑一个。每个 Skill 应带 skill\_id、语义化版本、前置条件、动作效果、supersedes、签名和验证状态，由确定性的 SkillResolver 选择唯一胜者。硬安全约束最先；然后看哪条规则的前置条件与当前观测事实匹配且更具体；同一 Skill 谱系内，再按 semver 和显式 supersede 关系选择已通过影子验证的新版本。跨 Skill 无法判断先后、证据不足，或条件同时命中但动作冲突时，应 fail-closed，只做只读补观测、向用户澄清或转人工，并写 Trace 生成冲突工单。版本号不能脱离谱系和验证状态单独决定胜负。

参考来源：

https://semver.org/lang/zh-CN/spec/v2.0.0.html

https://learn.microsoft.com/en-us/rest/api/azure/devops/

https://modelcontextprotocol.io/specification/2025-11-25

公开

同步至部落

取消

完成

0/2000

直线

曲线

AI

2026-09-21给文章提建议

![unpreview](https://static001.geekbang.org/resource/image/64/97/640e3755ed162dc7bd9ac25673303d97.jpg)

馨冉

Command + Enter 发表

0/2000字符

提交留言

大纲



固定大纲

11｜长任务 OBO 令牌过期，TTL 能否直接拉到 2 小时

12｜如何识别单步合规、组合违规的复合风险

13｜三维可信度权重如何按业务调优

14｜长时间挂起后 Checkpoint 过期怎么办

15｜如何区分真实推进和表演式忙碌

16｜Prompt 升级后黄金轨迹大面积偏离怎么办

17｜ChainOptimizer 冷启动期怎么运行

18｜如何挡住不在黑名单里的隐性越权副作用

19｜如何自动识别可能过期的 gold 用例

20｜矛盾 Skill 漏检后，运行时如何确定性仲裁