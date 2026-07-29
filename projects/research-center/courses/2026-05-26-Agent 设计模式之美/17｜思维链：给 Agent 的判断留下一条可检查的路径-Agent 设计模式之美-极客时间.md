<audio title="17｜思维链：给 Agent 的判断留下一条可检查的路径" src="https://res001.geekbang.org/media/audio/8f/d2/8f688ed9f1c69dfbd83d7bb473830fd2/ld/ld.m3u8"></audio>

你好，我是黄佳。

上一讲我们铺开了推理模块的全景。在推理分诊台里，简单问题应该直接回答；存在多个合理口径的问题，应该进入并行探索；信息不足、需要边查边修的问题，应该进入迭代假设验证。

CoT 处理的是推理分诊台中的中间路线：问题需要拆解，但还没有复杂到需要同时维护多条分支的情况。

## 看起来像推理 vs 真的能用

我们继续沿用薪酬 SaaS 的示例。如果用户说：

帮我看一下上海市场部 6 月薪资快照里的异常。

小冰缺 2 天考勤，咖哥奖金比上月多 18%，小雪社保基数变了。

哪些可以自动通过，哪些要人审？

之后，感知和记忆组件通过 RAG 等模式把咖哥那笔 18% 薪资异常相关的证据取回来了：薪资快照、奖金政策、审批记录、政策版本、历史工资等等。看起来，事情已经差不多了。

我们现在给一个普通模型加一句“请逐步思考”，它会输出一大段看起来很完整的分析：第一步看小冰，第二步看咖哥，第三步判断小雪。读起来是在推理，不过我们还要追问：小冰缺考勤，它查的是哪张考勤表？咖哥奖金突增，有奖金审批单吗？小雪基数变化的生效月份，系统是否做了确认？

所以 CoT 在 Agent 中每一步都要能落回证据，最后形成一个能对账的判断和一个可验证的结构：先确认异常事实，再拆工资组成，再核对适用规则，再查审批记录，最后决定要放行、拦截，还是转人工。

这样的细节需求如何在应用程序中实现呢？我们这就拆开细聊。

## 写出解题过程的重要性

1945 年，数学家波利亚在《How to Solve It》里把解题整理成理解问题、拟定计划、执行计划、回顾检验。他告诉我们，解题不是纯靠灵光一闪，而是可以被拆开、复述、练习和检查的过程。50 年代的 GPS 进一步把目标差距拆成子目标，形成早期的问题求解框架。

![](https://static001.geekbang.org/editor-compose/resourceimage/compose/b5/5f/b5cd3eba2c175cac83a221186d96785f.png)

进入大模型时代， Scratchpad 、 CoT 和 Zero-shot-CoT 让模型在给出最终答案前显式写出中间步骤；2023 年以后， Self-Consistency 、 Tree of Thoughts 和 ReAct 等方法又把单条链扩展成多路径、树状搜索和“思考—行动—观察”的交替过程。到了 推理模型时代 ，推理链不再只是提示词技巧，而逐渐变成模型在推理时计算中主动使用的一种能力。

上面这条推理思想谱系的共同点是把复杂问题拆成中间状态。过去依赖明确状态和手写规则，今天更多依赖概率生成、运行时预算和外部验证。也正因为今天的推理变成了概率生成，工程师才更需要 Trace、证据和验证器。模型越会想，系统越要会记账。

## CoT 在推理契约中的位置

上一讲我们给推理立了一个推理契约（Reasoning Contract）。每次任务进来，系统要回答五个问题：是否启动慎思，采用哪种推理拓扑，投入多少预算，由什么验证，什么时候停止。

![](https://static001.geekbang.org/infoq/a6/a6b860a4679f9e90f54405791356064a.jpeg)

Chain-of-Thought 落在“推理 × 链式”的交点

CoT 主要回答其中两个问题。

首先回答 “采用哪种推理拓扑”。CoT 选择的是一条主路径：一步接一步往前走，前一步的输出成为后一步的输入，最后把结论收束到一个可以验证的决定上。它不会同时维护很多条候选路径再投票；它也不是那种持续观察环境、不断重写假设的迭代闭环。它负责的任务主线基本清楚，但中间步骤不能省，必须沿着证据链逐步推进。

CoT 同时参与回答的是 “由什么验证”。比如，“P 的 6 月应发比 5 月高 18%”“18% 的增量主要来自季度奖金”“该租户规则要求涨幅超过 15% 时核查审批”“审批单金额、审批人和生效月份均匹配”，这些都不是模型自说自话，而是可以被工具、数据库、规则引擎或人工复核独立检查的对象。这样，验证步骤才有东西可验，审批门（Decision Gate ）才知道为什么放行、为什么拦截。

所以，CoT 把复杂判断拆成若干可验证命题。这串命题沿着一条主路径向前推进：看到异常、拆解问题、核验证据、确认解决。同时，系统也不断追问三个问题：结果是否满足目标，证据是否充分可靠，推理是否符合规则。

![](https://static001.geekbang.org/editor-compose/resourceimage/compose/ca/3b/cadaceabde113c154eaf992f33645a3b.png)

## 一步只表达一个可验证命题

既然 CoT 是一条可验证命题链，那么工程实现上，每一步都不能太含糊。比如下面这句话：

第一步：综合分析员工 P 的工资、奖金、政策和历史记录，判断该薪资变化是否合理。

它看起来很全面，实际上什么无法指导核查工作。因为它把好几个内容（包括观察事实、拆解问题、计算差异、核对规则、查证审批和最终判断）全塞进了同一步里。系统既不知道这一步的核心是什么，也不知道应该用哪个工具验证，更不知道如果这一步错了，下游哪些结论就不成立了。

真正可用的一步，应该只表达一个可验证命题。我们可以用三个问题检查每一步。如果这三个问题答不上来，这一步就不应该进入正式 Trace。

第一，这一步有没有一个明确的命题（立论）？

第二，这个命题能不能被工具、规则、数据库或人独立检查？

第三，如果这个命题错了，下游哪些步骤会被影响到？

以员工 P 的 18% 薪资异常为例，不要写“经分析，P 的工资上涨合理”。要拆成下面这样一组可验证的链：

S1：P 的 6 月应发工资比 5 月高 18%。

S2：18% 的增量主要来自季度奖金。

S3：该租户规则要求应发涨幅超过 15% 时核查审批。

S4：季度奖金审批单存在，且金额、审批人、生效月份均匹配。

S5：在 S2、S3、S4 均通过验证的前提下，本次可以自动放行。

## CoT 五步法：观察 → 拆解 → 计算 / 推导 → 验证 → 决策

为了让这条链能被程序处理，我们可以把 CoT 的步骤分成下面五类。

观察事实（Observe）：把外部事实读进来。例如：“P 的 6 月应发工资比 5 月高 18%。”

拆解问题（Decompose）：把大问题拆成可验证的小 claim。例如：“增量来自哪里”“是否触发审批规则”“审批是否存在且匹配”。

计算或推导（Derive）：基于已有事实推导或计算中间结果。例如：“18% 的增量主要来自季度奖金。”

验证（Verify）：对照规则、审批、合同、政策或数据库进行核查。例如：“超过 15% 需要审批”“审批单金额和月份匹配”。

决策（Decide）：在前面步骤都通过的前提下，做一个局部或最终决定。例如：“本次可以自动放行。”

![](https://static001.geekbang.org/editor-compose/resourceimage/compose/06/98/069b32e0a788ad16cf13a737b39a9498.jpg)

换成结构化轨迹，它大概是这样：

S1 OBSERVE

主张：P 的 6 月应发工资比 5 月高 18%。

证据：payroll\_snapshot:2026-05:v3

证据：payroll\_snapshot:2026-06:v3

S2 DECOMPOSE

主张：该异常需要拆成三个待验证子问题：增量来源、规则触发、审批匹配。

依赖：S1

输出：Q1 增量来自哪一项？

输出：Q2 是否触发租户审批规则？

输出：Q3 是否存在匹配的审批单？

S3 DERIVE

主张：18% 的增量主要来自季度奖金，而不是基本工资或补贴。

依赖：S1、S2.Q1

工具：payroll\_delta\_calculator

观察：basic\_salary\_delta = 0

观察：allowance\_delta = 0

观察：bonus\_delta = 8,400

S4 VERIFY

主张：该租户规则要求“单月应发涨幅超过 15% 时核查审批”。

依赖：S2.Q2

证据：policy:payroll\_anomaly:v7

有效期：2026-05-01 起

S5 VERIFY

主张：季度奖金审批单存在，金额、审批人、生效月份均匹配。

依赖：S3、S4、S2.Q3

证据：approval:BONUS-18472

验证器：approval\_validator

结果：passed

S6 DECIDE

主张：本次 18% 异常属于有审批支撑的季度奖金，可自动放行。

依赖：S3、S4、S5

验证器：payroll\_release\_gate

结果：passed

这条链和普通“逐步分析”最大的不同，是它每一步都能回到外部对象。薪资快照、政策版本、审批单都不是模型编的，验证器结果也不是模型自评。它们都能被系统重新读取、重新计算、重新验证。

普通 CoT 说：“我认为它合理。”生产 CoT 说：“S6 依赖 S3、S4、S5；S3 来自工资差异计算器；S4 来自政策版本 v7；S5 由审批验证器通过；所以 S6 可以放行。” 这就是从 CoT 到可核验轨迹的关键变化。

## 可验证 CoT 的工程实现

好，理论部分先告一段落。下面的问题是：工程上，这套流程到底怎么实现？

答案不是靠模型“自觉遵守”，而是靠结构化模式和验证闸门。模型默认很容易输出一段散文式思维链，但工程系统不能直接相信这段散文。我们可以先要求模型生成一组步骤草稿（StepDraft）。

每个步骤草稿只能表达一个可验证命题，并且必须标明自己的类型：观察、拆解、推导、验证，还是决策。随后，系统通过主张编译器（Claim Compiler，或称命题编译器），把这些草稿编译成结构化的主张步骤 ClaimStep（或称命题步骤）。

一个命题步骤就是推理追踪图（Reasoning Trace）里的一个受控节点。它至少要包含命题文本、主体、谓词、依赖项、证据引用、验证器和状态。

不同类型的节点有不同的准入条件：观察节点必须绑定外部证据；拆解节点必须产出可验证的子问题；推导节点必须依赖上游步骤或工具计算；验证节点必须有证据和验证器；决策节点必须依赖已经通过的上游节点，并经过决策闸门（decision gate）。

这样，“一步”就从模型随口生成的一句话，变成了可以检查追踪以及拦截的工程对象。任何一步如果同时包含多个判断，或者缺少证据、缺少验证器、依赖项还没有通过，就只能停在草稿区，不能进入正式推理链路。

![](https://static001.geekbang.org/editor-compose/resourceimage/compose/d3/df/d380067b87f9c44fcb1bac62a2e7d2df.png)

从自然语言推理到可验证 claim DAG

如图所示，“一步只表达一个可验证命题”把 CoT 从自然语言段落，改造成一张有向无环图 DAG。节点是原子命题，边是依赖关系，证据是外部引用，验证器是闸门。最终决定是 DAG 里所有关键依赖都通过验证后的结果。

第一层，用 Step Schema 限制“什么叫一步”。

每一步都是一个定义好的对象。它至少包含以下字段：

kind，说明这一步是什么类型；

claim，说明这一步主张什么；

depends\_on，说明它依赖哪些上游步骤；

evidence\_refs，说明它凭什么；

validator，说明谁来验证它；

status，说明验证状态。

这里最关键的是 kind。如果不分类型，模型很容易把“观察事实、解释原因、应用规则、做决定”塞进同一个步骤。类型一分开，程序就可以对不同步骤施加不同约束。

from dataclasses import dataclass, field

from enum import Enum

from typing import Any

class StepKind(str, Enum):

OBSERVE = "observe"

DECOMPOSE = "decompose"

DERIVE = "derive"

VERIFY = "verify"

DECIDE = "decide"

class StepStatus(str, Enum):

DRAFT = "draft"

PASSED = "passed"

FAILED = "failed"

NEEDS\_REVIEW = "needs\_review"

@dataclass(frozen=True)

class EvidenceRef:

source\_id: str

source\_type: str

version: str | None = None

effective\_at: str | None = None

content\_hash: str | None = None

@dataclass

class ClaimStep:

step\_id: str

kind: StepKind

claim\_text: str

subject: str

predicate: str

object: Any | None = None

depends\_on: list\[str\] = field(default\_factory=list)

evidence\_refs: list\[EvidenceRef\] = field(default\_factory=list)

action: str | None = None

observation: Any | None = None

validator: str | None = None

status: StepStatus = StepStatus.DRAFT

刚才我们说下面这句话不合格：“综合分析 P 的工资组成和审批记录后，可以判断这次上涨是正常季度奖金。”，原因是它至少混了四个命题：P 的工资上涨了；上涨来自季度奖金；审批记录存在；可以自动放行。现在工程上强制 LLM 拆成多个命题步骤。

第二层，用原子性闸门检查“一个步骤是否过载。

只有 schema 还不够。模型仍然可能把多个判断塞进命题文本 。所以要加一个原子性闸门（ Atomicity Gate）。它会做两类检查。

第一类是静态检查，比较粗。比如检查一句话里是否出现多个因果词、多个并列谓词、多个结论词。

AMBIGUOUS\_CONNECTORS = \[

"并且", "同时", "以及", "因此", "所以", "从而",

"说明", "证明", "可以判断", "综合来看",

\]

def looks\_too\_composite(claim\_text: str) -> bool:

hits = \[word for word in AMBIGUOUS\_CONNECTORS if word in claim\_text\]

return len(hits) >= 2

这类检查不能完美判断语义，但能拦掉一大批明显承载过多的步骤，因为我们希望保证命题的原子性，一次处理一件事儿。

第二类是类型约束，更为细致。不同步骤类型应该有不同的规则。

def validate\_step\_shape(step: ClaimStep) -> list\[str\]:

errors: list\[str\] = \[\]

if not step.claim\_text.strip():

errors.append("claim\_text is required")

if not step.subject or not step.predicate:

errors.append("structured claim requires subject and predicate")

if looks\_too\_composite(step.claim\_text):

errors.append("claim\_text seems to contain multiple claims")

if step.kind is StepKind.OBSERVE:

if not step.evidence\_refs:

errors.append("OBSERVE step requires evidence\_refs")

if step.depends\_on:

errors.append("OBSERVE step should not depend on derived steps")

if step.kind is StepKind.DECOMPOSE:

if not step.depends\_on:

errors.append("DECOMPOSE step requires an observed problem")

if step.evidence\_refs:

errors.append("DECOMPOSE should output questions, not claim external evidence")

if step.kind is StepKind.DERIVE:

if not step.depends\_on:

errors.append("DERIVE step requires upstream dependencies")

if not step.action:

errors.append("DERIVE step requires a tool or computation action")

if step.kind is StepKind.VERIFY:

if not step.evidence\_refs:

errors.append("VERIFY step requires evidence\_refs")

if not step.validator:

errors.append("VERIFY step requires validator")

if step.kind is StepKind.DECIDE:

if not step.depends\_on:

errors.append("DECIDE step requires dependencies")

if not step.validator:

errors.append("DECIDE step requires decision gate validator")

return errors

这段代码把不同步骤的放行条件拆开了。Observe 必须有证据。Decompose 必须依赖一个已观察到的问题，并输出待验证子问题。Derive 必须有依赖和工具。Verify 必须有证据和验证器。Decide 必须有依赖和决策闸门。

第三层，用注册表绑定验证器。

“一步可验证”还有一个隐藏条件：系统得知道谁来验证它。所以程序里要有一个验证器注册表 ( validator registry)。它把某类谓词（predicate）绑定到确定性验证器。

from collections.abc import Callable

ValidatorResult = tuple\[StepStatus, Any\]

Validator = Callable\[\[ClaimStep\], ValidatorResult\]

class ValidatorRegistry:

def \_\_init\_\_(self) -> None:

self.validators: dict\[str, Validator\] = {}

self.validators\[name\] = validator

def run(self, step: ClaimStep) -> ValidatorResult:

if not step.validator:

return StepStatus.NEEDS\_REVIEW, {"reason": "missing validator"}

validator = self.validators.get(step.validator)

if validator is None:

return StepStatus.NEEDS\_REVIEW, {

"reason": f"unknown validator: {step.validator}"

}

return validator(step)

这里要注意的是：Validator 并不一定是另一个 LLM。能确定性验证的，尽量用数据库、规则引擎、权限系统、计算器或测试框架。金额是否一致，交给计算器；政策是否生效，交给规则引擎；审批人是否具备权限，交给权限系统；工资项是否重复发放，交给数据库查询。LLM 适合拆解问题、生成检查计划、解释结果，但不适合独自承担所有判断。

第四层，用依赖图防止错误一路传下去

一步一个命题以后，下一件事是把步骤连成 DAG。最终决定不能直接依赖自然语言上下文，而要依赖已经通过验证的上游节点。

@dataclass

class ClaimTrace:

trace\_id: str

steps: list\[ClaimStep\] = field(default\_factory=list)

final\_decision: str | None = None

stop\_reason: str | None = None

def index(self) -> dict\[str, ClaimStep\]:

return {step.step\_id: step for step in self.steps}

def dependencies\_passed(self, step: ClaimStep) -> bool:

by\_id = self.index()

for dep\_id in step.depends\_on:

dep = by\_id.get(dep\_id)

if dep is None:

return False

if dep.status is not StepStatus.PASSED:

return False

return True

这里的关键是要明确“失效传播”。如果 S4 的政策版本验证失败，S5 和 S6 就不能继续当作事实使用。它们不是“低置信度”，而是依赖已经断了。系统必须知道，哪一步错了，然后哪些下游结论必须一起作废。

第五层，用追踪运行器执行整条链。

最后，追踪运行器（Trace Runner）把前面几块串起来。它的职责不是“替模型思考”，而是执行结构化步骤、检查依赖、运行验证器、决定是否停止。

class TraceRunner:

def \_\_init\_\_(self, registry: ValidatorRegistry) -> None:

self.registry = registry

def run(self, trace: ClaimTrace) -> ClaimTrace:

for step in trace.steps:

shape\_errors = validate\_step\_shape(step)

if shape\_errors:

step.status = StepStatus.NEEDS\_REVIEW

step.observation = {

"reason": "invalid\_step\_shape",

"errors": shape\_errors,

}

trace.stop\_reason = "invalid\_step\_shape"

return trace

if not trace.dependencies\_passed(step):

step.status = StepStatus.NEEDS\_REVIEW

step.observation = {

"reason": "dependencies\_not\_passed",

"depends\_on": step.depends\_on,

}

trace.stop\_reason = "dependency\_not\_passed"

return trace

if step.kind in {StepKind.VERIFY, StepKind.DECIDE}:

status, observation = self.registry.run(step)

step.status = status

step.observation = observation

if status is not StepStatus.PASSED:

trace.stop\_reason = f"step\_failed:{step.step\_id}"

return trace

else:

step.status = StepStatus.PASSED

decisions = \[

step for step in trace.steps

if step.kind is StepKind.DECIDE

\]

if decisions and all(step.status is StepStatus.PASSED for step in decisions):

trace.final\_decision = str(decisions\[-1\].object)

trace.stop\_reason = "all\_required\_claims\_verified"

else:

trace.stop\_reason = "no\_decision\_step"

return trace

第六层，让 LLM 输出步骤草稿。

实际工程里，不建议让大模型直接写最终的主张步骤（ClaimStep）。因为最终 Trace 是系统责任链的一部分，不能完全交给模型自由生成。更稳妥的做法，是让大模型先输出命题草稿（StepDraft）：它只负责提出“下一步想表达什么命题”，以及这个命题大致属于观察、拆解、推导、验证还是决策。

随后，由程序完成后面的工程化处理：补充证据引用、调用工具、绑定验证器、检查依赖关系，再把合格的命题草稿编译成主张步骤。

LLM 的职责是：把复杂任务拆成候选命题。

程序的职责是：把候选命题编译成可验证节点。

@dataclass

class StepDraft:

kind: StepKind

claim\_text: str

suggested\_subject: str | None = None

suggested\_predicate: str | None = None

suggested\_object: Any | None = None

suggested\_evidence\_query: str | None = None

这一步可以叫命题编译（ ClaimCompiler）。

class ClaimCompiler:

def compile(

self,

draft: StepDraft,

step\_id: str,

evidence\_refs: list\[EvidenceRef\],

validator: str | None,

depends\_on: list\[str\],

) -> ClaimStep:

if not draft.suggested\_subject or not draft.suggested\_predicate:

raise ValueError("Draft lacks structured claim fields")

return ClaimStep(

step\_id=step\_id,

kind=draft.kind,

claim\_text=draft.claim\_text,

subject=draft.suggested\_subject,

predicate=draft.suggested\_predicate,

object=draft.suggested\_object,

depends\_on=depends\_on,

evidence\_refs=evidence\_refs,

validator=validator,

)

为什么要多这一层？因为 LLM 很适合拆问题，但不应该让它自己决定“我已经有证据了”。证据应该来自 RAG、数据库、工具、规则系统或人工确认；validator 应该来自系统注册表。

上面就是程序设计层面的完整落地过程：LLM 提出步骤，但每一步都必须经过结构化模式（schema）、原子性（atomicity）、证据（evidence）、验证器（validator）和依赖关系（dependency）的约束。能通过，才进入推理追踪链路（Reasoning Trace）；不能通过，就停在草稿区（scratchpad），或者升级为人工复核（human review）。

下面这张图展示的是可验证 CoT 的最小数据模型。

![](https://static001.geekbang.org/infoq/56/56aa52f8992342445d634b12232c27c4.png)

一步一个 ClaimStep。自然语言 CoT 先被编译成 claim DAG，每个节点只承载一个可验证命题；证据、依赖和验证器共同决定它能不能进入正式 Trace

一条 CoT 就这样被落盘成 ClaimTrace；ClaimTrace 由多个 ClaimStep 组成；每个 ClaimStep 绑定 EvidenceRef，并通过 ValidatorRegistry 找到验证器。

ClaimTrace 是整条推理轨迹，是一组可以被程序遍历和检查的结构化节点负责保存任务 ID、步骤列表、最终决定和停止原因。

每一个 ClaimStep 代表一个原子命题，里面记录这一步的类型、主张、结构化谓词、依赖关系、证据引用、验证器和当前状态。

EvidenceRef 表示这一步引用的外部证据，例如工资快照、政策版本、审批单或日志记录。它只保存引用和版本信息，不把证据正文直接塞进推理链。

ValidatorRegistry 则是验证器注册表，ClaimStep 里只写验证器名称，真正执行时通过注册表找到对应的确定性验证器来检查这一步是否成立。

整个框架的设计是为了确保系统知道每一步凭什么成立、依赖谁、谁来验证，以及失败后哪些下游结论必须失效。

## 三道闸门：证据、确定性验证、升级退出

在上面的流程中，LLM 只负责提出候选步骤。真正决定这一步能不能进入正式轨迹的，是闸门。一条 CoT 进入生产，至少要过三道闸门。

第一道是证据闸门。关键判断必须绑定证据，没有证据的判断，不能进入最终决定。比如“P 的奖金应该是正常发放”，如果没有审批单、政策版本、工资明细支撑，只能算模型猜测。它可以留在草稿区里，不能进入决策。证据闸门要检查证据是否存在、来源是否权威、版本是否正确、有效期是否覆盖当前场景，以及证据是否属于当前租户和当前员工。企业系统里，跨租户误用证据，是比推理错误更危险的事故。

第二道是确定性验证闸门。能用确定性程序验证的，不要交给模型自评。金额是否一致，交给计算器；政策是否生效，交给规则引擎；审批人是否具备权限，交给权限系统；工资项是否重复发放，交给数据库查询。LLM 可以解释验证结果，但不应该替代验证器本身。

第三道是升级退出闸门。CoT 适合一条主路径可以走通的问题，但如果它走不通，就要退出。证据缺失、证据冲突、规则版本不唯一、验证器失败、关键依赖无法确认、模型连续两次改写同一事实、工具结果和模型解释不一致，这些都应该触发升级。此时不要让 CoT 继续硬编，而应该升级到并行探索、迭代假设验证，或者人工复核。

![](https://static001.geekbang.org/infoq/67/67f8dd92b95742a91a91ae6b718c6ef9.png)

CoT 的三道闸门

这些闸门就是一次 CoT 的停止条件。当所有关键依赖均通过验证，或者出现无法通过单链解决的冲突并升级，CoT 就结束，并进入下一步工作流程。

## 供应侧状态（Provider state）与应用层轨迹（Application trace）

推理状态还有一个跨轮问题。

Agent 不是一次性问答。真实任务会多轮调用工具，可能中途失败，可能切换模型，也可能跨会话继续执行。这个时候，工程上必须区分两种状态：供应商侧推理状态（Provider reasoning state）和应用侧审计轨迹（Application audit trace）。

供应商侧推理状态，是模型供应商或 API 层维护的推理续接状态。在跨轮工具调用时，应用可以通过上一轮响应 ID（previous\_response\_id），或者手动传回上一轮的推理项，帮助模型接着上一轮继续推理。在无状态（stateless）或零数据保留（zero data retention）场景中，也可以通过加密推理项在请求之间携带必要的推理上下文。

但供应商侧推理状态不是业务审计记录。你不能指望一个加密推理项告诉审核员：为什么某人的工资被放行。它更像是模型续接用的内部状态包，目标是让模型下一轮接着想，而不是让业务事后能复盘。

应用侧审计轨迹，才是系统自己维护的结构化记录。它要记录任务 ID、推理模式、每一步主张、证据引用、工具动作、观察结果、验证器、步骤状态、最终决定和停止原因，能在出错时定位是哪一步出了问题。

我们把二者分开：供应商侧推理状态负责“续接思考”，应用侧审计轨迹负责“留下责任链”。前者可以帮助模型不中断，后者才能让系统可治理。

![](https://static001.geekbang.org/editor-compose/resourceimage/compose/25/a9/2556a33715b70d638f3ef41e159a08a9.jpg)

Provider state 帮模型续想，Application trace 帮系统负责

这样，跨轮设计时，模型内部状态由 Provider state 续接；应用审计轨迹由 Application trace 结构化保存；长期经验复用则经过验证、脱敏、蒸馏后再写入记忆层。要注意的一点是不要只保存最终答案，同时也不要把原始长篇 CoT 全量长期保存。

## 总结一下

这节课新东西不少吧。现在你对 CoT 在执行型 Agent 里的位置是否更清晰？

一句话总结：CoT 在推理契约里的工程定位，是用一条主路径，把复杂判断拆成若干可验证命题，为最终 Validator 放行做准备。

所以，我们这里讲的 CoT，完全不是“写出思考过程”的提示词技巧，而是一个生产系统里的推理结构。任务进来了，先经过推理契约判断是否适合单链；如果适合，就沿着主路径推进；每一步只表达一个可验证命题；每个命题绑定证据、依赖和验证器；最后由 Decision Gate 检查整条链是否可以放行。

最后，提醒大家，这么复杂的 CoT 设计流程，该用才用，可别到处都用。简单任务被硬塞推理，又慢又贵又啰嗦，何必呢。这节课我们讲的是设计思想，可不是万能法则哈。

## 思考题

1\. 你的 Agent 现在是不是所有请求都默认“逐步思考”？挑几个最简单的查询看一眼，它有没有为了配合提示，硬编一段没必要的推理？如果按推理边界分四档（不开思考、浅想、结构化推理、高风险推理），有多少请求其实可以不开思考？

2\. 你系统里最近一次有争议的 Agent 决策，能不能把它的推理拆成观察、规则核对、查证、决策，每一步都挂上证据？哪一步挂不上？如果有挂不上的地方，恰恰是 is\_accountable() 会拦下的地方。

3\. 你现在保存推理轨迹吗？今天就给 trace 加上 claim 和 evidence\_refs，找一个跨了三轮工具调用的任务，观察一下。

## 下一讲预告

下一讲我们讲第二个推理模式，复杂度路由（Complexity-Based Routing）。

这一讲我们一直在说“该想才想、想多深”，但判断该想多深这件事本身要花成本。复杂度路由就是把这件事做成分诊台。我们下一讲见。

## 参考资料

George Pólya. How to Solve It. Princeton University Press, 1945.

Newell, Shaw, Simon. Report on a General Problem-Solving Program. IFIP, 1959

Nye et al. Show Your Work: Scratchpads for Intermediate Computation with Language Models. arXiv:2112.00114, 2021.

Wei et al. Chain-of-Thought Prompting Elicits Reasoning in Large Language Models. arXiv:2201.11903, NeurIPS 2022.

Kojima et al. Large Language Models are Zero-Shot Reasoners. arXiv:2205.11916, NeurIPS 2022

Wang et al. Self-Consistency Improves Chain of Thought Reasoning. arXiv:2203.11171, ICLR 2023

Yao et al. Tree of Thoughts: Deliberate Problem Solving with Large Language Models. arXiv:2305.10601, NeurIPS 2023

Yao et al. ReAct: Synergizing Reasoning and Acting in Language Models. arXiv:2210.03629, ICLR 2023

OpenAI. Reasoning models

DeepSeek-AI. DeepSeek-R1 incentivizes reasoning in LLMs through reinforcement learning. Nature 645:633-638, 2025

Anthropic. The "think" tool: Enabling Claude to stop and think. 2025

OpenAI / Frontier Model Forum. Chain-of-Thought Monitorability 评估. 2025

Anthropic. Reasoning Models Don't Always Say What They Think. arXiv:2505.05410, 2025

公开

同步至部落

取消

完成

0/2000

直线

曲线

AI

2026-07-07给文章提建议

馨冉

Command + Enter 发表

0/2000字符

提交留言

大纲



固定大纲

看起来像推理 vs 真的能用

写出解题过程的重要性

CoT 在推理契约中的位置

一步只表达一个可验证命题

CoT 五步法：观察 → 拆解 → 计算 / 推导 → 验证 → 决策

可验证 CoT 的工程实现

三道闸门：证据、确定性验证、升级退出

供应侧状态（Provider state）与应用层轨迹（Application trace）

总结一下

思考题

下一讲预告

参考资料