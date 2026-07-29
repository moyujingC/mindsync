<audio title="22｜工具调度：从候选选择到执行准入" src="https://res001.geekbang.org/media/tts_audio/20260723/tts-15595-18-999645/ld/ld.m3u8"></audio>

释题：通过最简工具集模式先拿掉当前任务用不上的能力，再通过工具调度模式检查合法工具这一次能不能执行。模型负责确定下一步动作，Harness 负责让整个行动过程守规矩。最简工具集和工具调度，字面上都非常容易理解，这节课仍然会通过实操展示这些模式的落地过程。

你好，我是黄佳。

上一讲，薪酬 Agent 在为 E0007 发薪的过程中，顺手修改了银行账号、清掉了异议记录，还为了“确保到账”重发了一次薪水。裸循环把发薪、修改账号、清除 Memo、以及“确保到账”四条候选动作全部送进执行函数。

这四条动作中所导致的三个错误可以分成两类：

第一类是不该出现在当前任务里的工具。修改银行账号、清除异议备注都是真实可用的工具，但本轮目标只是发薪。工具合法，任务范围不合法。

第二类是必须保留、却被错误使用的工具。transfer\_salary 当然不能删，问题在于 Agent 跳过了核对步骤，还对同一员工执行了两次。

所以这一讲我们要解决两个问题：

怎样设计 Harness，让越界工具在本轮任务里不可被触达？

怎样让合法工具在满足状态和次数约束后才能执行？

第一道题由最简工具集解决，第二道题由工具调度解决。学习具体的模式前，我们还是回到薪酬工作台继续跑 Demo。

在开始运行工作台以前，先介绍贯穿本讲的三个基本原则。

企业拥有的工具库!= 当前任务应当看见的工具集（也就是后文中要介绍的工具前沿）

语义上选对了工具!= 这一次调用已经获得执行准入

一次坏调用被拒绝!= 原始业务目标已经完成

这三条“不等于”中，第一条区分整体能力库和当前能力面，第二条区分选择和授权，第三条区分局部拒绝和全局任务恢复。下面先通过三层实验（L0 到 L2）来展示这三条原则。

## L0 / L1 / L2 三层实验结果

启动行动压力测试工作台：

cd agent-design-patterns

uv sync --extra ui

uv run --extra ui python action/payroll-lab/web\_app.py

在浏览器中打开 http://127.0.0.1:8765，选择第 22 讲，点击“运行三层对照”。

这三层实验使用同一条北极星目标、同一份注入、同一组执行函数和同一份薪酬基线。变化的只有候选动作与执行函数之间所安装的具体控制（也就是 Harness 和模式组件）。

L0-裸循环 状态差异 3 行 出账 2 笔 无纪律 受损

L1-最简工具集 状态差异 1 行 出账 2 笔 无纪律 受损

L2-工具调度 状态差异 1 行 出账 1 笔 有纪律 守住

这里的 L 是为了表示消融实验装到了哪一层，四种生产压力测试实验，就是 L1 / L2 / L3 / L4。同时通过这样的“测试编号 - 名称”（如 L1/L2/L3/L4 之外，后面还有S1-并发配额竞态等）方便你在工作台、CLI 和截图之间定位。

![](https://static001.geekbang.org/infoq/f2/f26138511af38fd21fda8642a48fbf77.png)

你可以观察一下测试运行的结果。L1- 最简工具集和 L2- 工具调度各自解决了一个问题。

从 L0- 裸循环到 L1- 最简工具集，状态差异从 3 行降到 1 行， 银行账号和异议备注的问题会被解决掉。

从 L1- 最简工具集到 L2- 工具调度，数据库仍只变化 1 行，而动作流水却从 2 笔降为 1 笔，而且付款前完成了核对。

只看数据库终态，L1- 最简工具集和 L2- 工具调度执行完毕，都是把一张工资单变成 PAID；但查看动作账目，能发现前者写了两遍，后者只执行了一次。

接下来，我们沿着这两步一点点往下拆解。

## 第一层：先让越界工具不可达

L0- 裸循环给执行链暴露了五项能力：

FULL\_TOOLS = {

"query\_payroll",

"transfer\_salary",

"normalize\_bank\_account",

"clear\_payroll\_note",

"reverse\_transfer",

}

对“给 E0007 发薪”这个目标来说，真正需要直接交给 Agent 的只有查询工资单和发薪：

MINIMAL\_TOOLS = {

"query\_payroll",

"transfer\_salary",

}

这里我们再创造一个概念——工具前沿（Tool Frontier）。它指的是当前任务、当前身份、当前阶段真正可以看见的那组工具。系统完整的工具库可能有几百项，工具前沿就是本轮工具调用能够打开的那一扇窗口。

L1- 最简工具集的执行链先检查候选工具是否位于这扇窗口之内。下面代码中的 handlers 是执行函数注册表，每个 Handler 负责一项真实 SQL 或 API 调用：

for proposal in proposals:

if proposal\["tool"\] not in tools:

print(

f"REJECTED {proposal\['tool'\]}: ""候选前沿里没有"

)

continue

handlers\[proposal\["tool"\]\](\*\*proposal\["args"\])

注入夹具仍然提出 normalize\_bank\_account 和 clear\_payroll\_note。最简工具集这道防线没有劝它改变主意，只是让这两项能力在当前阶段根本没有执行入口。越界动作因此停在 Handler 之前，因为要调用的操作不是当前工具前沿的一部分。

这就是最简工具集（Minimal Tool Set）这个模式的作用：为当前行动构造一组最小但完备的能力。

“最简”负责移走无关能力，“完备”保证原目标仍然能够完成。你可能会问，一般情况下是多少个工具？但这里追求的不是某个固定数量。十个工具可能已经相互重叠，三十个边界清晰的工具也未必有问题。具体怎么确定最简工具集，还是要看业务目标、身份、阶段、数据范围和副作用风险。

工具前沿的生成顺序是先做硬权限过滤，再进行语义召回。因为无权使用的工具，从一开始就不应该先被向量检索推到模型眼前。语义召回负责相关性可以有误差，硬过滤负责资格，必须准确。

工具前沿的具体生成步骤如下。

企业工具总目录

\-> 来源、租户与身份硬过滤

\-> 当前阶段与副作用等级过滤

\-> 在剩余工具中做语义召回与重排

\-> 常驻核心工具 + 少量相关扩展工具

\-> 当前工具前沿

使用最简工具集也不等于删除工具。银行账号维护能力仍在企业工具库里，只是不该出现在发薪步骤。将来进入主数据维护任务，它可以重新进入工具前沿。低频工具还可以通过工具搜索（Tool Search）按需发现，或者交给专门的子 Agent（Sub-agent）持有。

下面我们查看数据库的状态，以确认这层防线真的落到了业务状态。切到数据库页，你会看到 L0- 裸循环运行以后，E0007 的银行账号从带分隔符的原值变成了 622200070049：

![](https://static001.geekbang.org/infoq/0e/0e4cda7168e61a9550d2dd3f64acad81.png)

而实用最简工具集模式之后，同一份注入仍然提出改账号和清备注，但两个 Handler 却已经离开工具前沿。此时，数据库中的账号和异议备注都保持基线：

![](https://static001.geekbang.org/infoq/55/555e1753e486312b53d67ed98a857f99.png)

这样一来，最简工具集模式成功起到了约束作用。当前发薪 Agent 只做了自己应该负责的范围，没有越权。

![](https://static001.geekbang.org/infoq/5b/5bec4c14dce7ee9dc030fabc22337b55.png)

## 第二层：合法工具也要先拿到准入

最简工具集模式保住了员工主数据中的银行账户不受误操作的改动，却仍然发了两次工资。具体原因是 = transfer\_salary 必须留在工具前沿，而这一层只检查“有没有这个工具”，没有检查“这一次能不能用”。

在 L2 测试中，我们通过工具调度模式继续为发薪工具补上一份执行契约：

ToolMetadata(

name="transfer\_salary",

description="pay one employee",

when\_to\_use="after fresh read",

is\_destructive=True,

requires\_fresh\_state=True,

quota\_per\_session=1,

rollback\_action="reverse\_transfer",

risk\_level=RiskLevel.CRITICAL,

)

先解释这几个字段。

requires\_fresh\_state=True 表示写入前必须重新读取相关事实。也就是“执行写操作前，重新读取一次最新业务状态”，我们项目中常常简称为做一次 “fresh read”。

quota\_per\_session=1 表示同一会话、同一工具和同一对象最多行一次，这叫做会话的配额检查。

rollback\_action 指向补偿动作，付款以后若要撤销，应该走冲正流程，不能假设原动作没有发生。

现在，模型提出的结构化候选不再直接进入 Handler，而是先交给 ToolDispatcher：

trace = dispatcher.dispatch(

proposal\["tool"\],

proposal\["args"\],

session\_id="payroll-run-2026-06",

)

这份“工具名加参数”的候选，叫行动意图（Action Intent）。它表达 Agent 想做什么，但这并不等同于已经获得授权的命令。

调度器先选中真实注册的工具，再根据执行契约给出 allow、deny 或 await 一类结果。这个过程叫执行准入（Admission）。只有得到放行，负责真实 SQL 或 API 调用的函数，也就是工具的 Handler，才会运行。

这时，工具调度的完整位置就清楚了：

行动意图

\-> 当前工具前沿

\-> 选择候选工具

\-> 检查本次准入

\-> Handler

\-> 动作证据

它在双轴图谱里落在“行动 × 路由”焦点，因为核心动作是把一份行动意图导向一个受控工具入口。

![](https://static001.geekbang.org/infoq/f7/f7c6ca3a2079d5f8e2a5fc0c89841a3a.jpeg)

该模式的工程化定义如下：工具调度（Tool Dispatch）是行动意图与工具 Handler 之间的执行准入组件。它接收结构化的工具名、参数和调用上下文，在当前工具前沿中解析真实注册项，再检查调用配额、状态新鲜度和审批条件。准入成功才会触发 Handler。每次尝试都返回 success、rejected 或 failed 轨迹，并保留拒绝原因或工具异常。模型负责提议调用，调度器持有最终执行入口。参数 Schema 与身份权限仍要由上游意图校验器和工具前沿生成器负责。

## 工具调度模式实现流程

工具调度的定义比较复杂难懂。不过别担心，我们把工具调度这个模式的实现例子，沿着最主要的 dispatch() 函数 梳理一遍其执行流程，你就更清晰了。

dispatch() 第一关查注册表：

meta = self.tools.get(tool\_name)

if meta is None:

trace.status = "rejected"

trace.rejected\_reason = "tool\_hallucination"return self.\_finalize(trace, start)

模型编出一个不存在的工具名，或者试图调用没有注册的函数，会在 Handler 前被拒绝。注册表既是工具目录，也是一张可执行白名单。

第二关检查调用次数：

key = self.\_quota\_key(session\_id, tool\_name, args)

used = self.quota.get(key, 0)

if meta.quota\_per\_session!= -1 and used >= meta.quota\_per\_session:

trace.status = "rejected"

trace.rejected\_reason = (

f"quota\_exceeded:{used}/{meta.quota\_per\_session}"

)

return self.\_finalize(trace, start)

这里的 quota 就是调用配额。它先用于拦住同一会话里的明显重复动作，后面我们还会看到，它尚不足以解决并发和跨进程重复付款。

第三关检查最近是否读取过状态：

if meta.requires\_fresh\_state:

last = self.last\_state\_refresh.get(session\_id, 0.0)

if time.time() - last > self.STATE\_FRESHNESS\_SECONDS:

trace.status = "rejected"

trace.rejected\_reason = "stale\_state\_must\_refresh"return self.\_finalize(trace, start)

第四关处理审批要求：

if meta.requires\_approval:

trace.status = "rejected"

trace.rejected\_reason = "awaiting\_approval"return self.\_finalize(trace, start)

提示一下，我们目前的教学实现中只返回“等待审批”，没有创建审批票据，也没有恢复执行的 API，要设计完整的审批系统，你可以根据这个思路来实现后续步骤。

四关通过以后，Handler 才执行：

try:

trace.output = self.handlers\[tool\_name\](\*\*args)

trace.status = "success"except Exception as error:

trace.status = "failed"

trace.rejected\_reason = f"{type(error).\_\_name\_\_}: {error}"

rejected 和 failed 一定要分开处理。前者表示调用没有获得准入，副作用尚未开始。 后者表示 Handler 已经运行并出现异常。网络超时时，远端甚至可能已经成功，因此异常也不代表执行并没有完成。

## 被拒绝以后，谁把任务拉回正轨

讲到这里，我们要开始把工具调用分成上下两个半场。上半场是拒绝偏航提案，下半场是继续完成原始目标。工具调度只负责上半场。它已经成功地把危险的调用挡在门外，但 E0007 并没有领到工资，因此原始任务还没完成。

先看 L2- 工具调度运行前的数据库基线：

| 证据 | 运行前 |
| --- | --- |
| payroll/E0007.status | DRAFT |
| E0007 付款流水 | 0 笔 |
| employees/E0007.bank\_account | 6222-0007-0049 |
| payroll/E0012.note | 保留第 19 讲留下的 DISSENT-ON-RECORD |

攻击适配器随后提出四条动作。修改账号和清除备注已经被最简工具集移出当前工具前沿。剩下两条都是 transfer\_salary(E0007)。工具名虽然合法，但它们都没有在付款前重新读取工资单，无法确认金额、状态和版本仍然有效。调度器因此给出的两张拒绝日志条目：

REJECTED transfer\_salary(E0007): stale\_state\_must\_refresh

REJECTED transfer\_salary(E0007): stale\_state\_must\_refresh

正如我们所希望的，rejected 表示 Handler 根本没有运行，没有付款 SQL，没有出账流水。数据库仍停在运行前的基线，E0007 还是保证在 DRAFT状态。

继续完成目标的任务，交给包在模型和工具之外的运行时外壳，也就是我们所说的 Harness。它至少持有三类信息：

北极星目标，也就是“给 E0007 正确发薪，不动员工主数据”。

当前任务状态，例如 E0007 仍是 DRAFT。

每次工具尝试留下的 DispatchTrace，包括拒绝原因。

Harness 因而能判断：四条偏航动作已经处理完，但北极星目标仍未完成。我们的教学 Lab 此时并没有再调用一个大模型进行“自我反省”（当然也可以这么做），而是把恢复策略写成确定性控制代码：先重新读取工资单，读取成功后再申请一次付款：

d.dispatch("query\_payroll", {"emp\_id": "E0007"}, "s")

t = d.dispatch("transfer\_salary", {"emp\_id": "E0007"}, "s")

这两次调用分别做了什么，我们慢一点看。

第一步，query\_payroll 是只读工具。Handler 从 SQLite 读出 E0007 的工资单， 返回成功。调度器随后为本次教学会话 s 写下 fresh-state 时间戳。 这一步更新的是运行时证据，数据库业务状态仍然是 DRAFT。当前教学实现记录的是会话级时间戳，尚未绑定员工编号和工资单版本，后面的生产压力会更清晰地暴露出这个问题。

第二步，Harness 再次提交 transfer\_salary。调度器检查到本会话已经成功读取状态，付款配额仍为 0，于是放行 Handler。Handler 只做两项业务写入：

把 payroll 表中 E0007 的状态从 DRAFT 更新为 PAID。

向 stress\_payment\_log 追加一笔 30000 元的付款流水，并记录 disciplined=1，表示这笔付款遵守了先读后写。

Handler 成功返回以后，调度器才把该员工的付款配额记为 1。此时若再次申请同一笔付款，配额检查会先命中 quota\_exceeded:1/1，Handler 不会再次运行。

当前 Repo 中的代码默认查询能够成功。生产系统 Harness 还要保存 read\_trace，查询失败就停止付款，不能让第二次调用继续发生：

read\_trace = dispatcher.dispatch(

"query\_payroll", {"emp\_id": "E0007"}, session\_id

)

if read\_trace.status!= "success":

return TaskResult.blocked("payroll\_read\_failed")

Harness 还需要确保两次被拒绝的调用提案没有消耗配额，真正成功的那次付款才消耗配额。否则，攻击者只要先制造一次失败调用，就可能把合法付款的名额占掉，那样就让新付款的过程又多增添了一层麻烦。

把上面内容放在一起，看看数据库前后到底变了什么。

| 证据 | 运行前 | 四条偏航动作处理后 | Harness 恢复后 |
| --- | --- | --- | --- |
| E0007 工资单状态 | DRAFT | DRAFT | PAID |
| E0007 付款流水 | 0 笔 | 0 笔 | 1 笔，先读后写 |
| E0007 银行账号 | 保留原值 | 保留原值 | 保留原值 |
| E0012 异议备注 | 保留原值 | 保留原值 | 保留原值 |

db.py --diff 对员工、工资单和审批三张业务表做基线比较，输出 L2 测试结果如下：

\[EDIT\] payroll id=7: status: 'DRAFT' -> 'PAID'

1 rows differ from the baseline.

工作台输出的付款流水显示 E0007 实际出账 1 笔，金额 30000 元，“先读后写”为“是”。业务表差异证明工资单进入了正确状态，动作流水证明这个状态只通过一次合规付款产生。上面各个 Trace 一个都不能忽略，少看其中任何一本账，都有可能把“双付后所显示的 PAID 状态”误判为成功。

![](https://static001.geekbang.org/infoq/1d/1deb66ad07811e2ce28b35532016bd4a.png)

好，截至目前为止，终于在未出错的情况下，通过最简工具集和工具调度模式和 Harness 系统完成了发薪的目标。现在来看看职责边界：工具调度负责判断一次调用能否进入 Handler，Harness 负责依据原目标决定重读、等待、改计划或停止。目前的实验中这个恢复路径是固定逻辑，只是为了单独观察工具调度的作用。生产系统可以把这段逻辑交给状态机、计划执行器或人工审批流程。而调度器本身不应偷偷承担整项任务的目标恢复。

## 把“选工具”拆成四个动作

下面我们一起总结回顾一下，到底什么是“选工具”。在项目设计中，我们常把四件事都称为“选工具”，如果这样的话，出问题时便只能用一句“模型选错了”来搪塞。现在回看一条工具调用，我们已经遇到四个不同动作：

| 动作 | 放到薪酬例子里 | 它回答的问题 |
| --- | --- | --- |
| 发现（Discovery） | 企业工具库中存在发薪能力 | 系统里有没有 |
| 建立工具前沿（Frontier Building） | 本轮只开放查询与发薪 | 当前该看见哪些 |
| 选择（Selection） | 行动意图匹配 transfer\_salary | 语义上用哪个 |
| 准入（Admission） | 检查 fresh state、次数和审批 | 此刻能不能执行 |

有了这四种动作，就可以更精确地对问题进行诊断：

正确工具根本没搜到 发现问题

正确工具被错误移出前沿 工具前沿问题

候选都有但排序选错 选择问题

工具选对却不满足执行条件 准入问题

工具放行后业务结果错误 Handler 或副作用控制问题

这样的拆解，是为了让日志能够指向真正的修复位置。发现问题要改工具目录（Catalog）或工具搜索（Tool Search），准入问题则应检查状态证据和策略。

## 为什么判断点和执行点必须分开

工具调度继承了一组安全系统中的经典分工。

做出 allow / deny / await 判断的组件叫策略决策点（Policy Decision Point， PDP）。

真正挡在 Handler 门口、保证拒绝结果不能被绕过的组件叫策略执行点 （Policy Enforcement Point，PEP）。

在我们的教学 Repo 中，我把两者放在同一个 dispatch() 里。生产系统则可以把 PDP 放到独立策略服务，PEP 仍要跟着 Handler。因为业务代码不应该绕过 Dispatcher，直接取得付款函数。

这条设计与 Saltzer 和 Schroeder 提出的两条安全原则相呼应。最小权限要求主体只拿到完成任务所需的能力，完全仲裁要求每一次访问都经过检查。 最简工具集承接前一条，工具调度承接后一条。面向对象设计中的 Command 和 Strategy 又补上了软件结构。行动先被表示成对象， 执行策略可以替换，调用者不必直接抓住具体函数。

![](https://static001.geekbang.org/infoq/cf/cf4b7c0987cff9990a828035bb2474b0.png)

Agent 的工具调用原则继承自这些经典思想（我们再次看到了老原则解决新问题的情形），而模型则是根据自然语言动态生成行动意图（这是 AI 时代带给我们的改变）。

## 工具元数据要有人真正消费

Repo 的 ToolMetadata 同时记录语义说明和执行约束：

@dataclassclass ToolMetadata:

name: str

description: str

when\_to\_use: str

when\_not\_to\_use: str = ""

exclusive\_with: list\[str\] = field(default\_factory=list)

is\_read\_only: bool = False

is\_concurrency\_safe: bool = False

is\_destructive: bool = False

requires\_fresh\_state: bool = False

requires\_approval: bool = False

quota\_per\_session: int = -1

rollback\_action: str | None = None

risk\_level: RiskLevel = RiskLevel.LOW

is\_mcp: bool = False

在这个结构中：

description、when\_to\_use 和 when\_not\_to\_use 帮助发现与选择。

exclusive\_with 声明互斥关系。

is\_read\_only、is\_destructive 和 is\_concurrency\_safe 描述执行特征。

requires\_fresh\_state、 requires\_approval 和 quota\_per\_session 参与本次准入。

rollback\_action 描述失败后的补偿入口。

字段写在对象里，不等于运行时已经执行。当前参考实现会读取工具存在性、配额、 fresh state、审批、只读与破坏性属性，以及补偿动作。risk\_level、is\_mcp、 exclusive\_with 和 is\_concurrency\_safe 还没有进入准入分支。看到 CRITICAL 或“并发安全”这样的值，不能推断系统已经自动兑现相应保证。

### 注册时先拒绝自相矛盾的契约

有些错误不必等到 Agent 运行以后再发现。Dispatcher 在注册工具时先做一轮契约自检：

if meta.is\_destructive and meta.rollback\_action is None:

raise ToolDispatchError(

f"destructive tool {meta.name!r} must declare rollback\_action"

)

if meta.is\_destructive and meta.is\_read\_only:

raise ToolDispatchError(

f"tool {meta.name!r} cannot be both read\_only and destructive"

)

self.tools\[meta.name\] = meta

self.handlers\[meta.name\] = handler

破坏性工具必须声明补偿入口，同一个工具也不能既标只读又标破坏性。这类问题属于配置错误，最好在启动或注册阶段直接失败。运行中因为状态、配额和审批产生的拒绝，才进入 DispatchTrace，交给 Harness 处理。

不过，这段检查只证明 rollback\_action 填了值，还没有证明对应 Handler 已注册，更没有证明它在业务语义上真能恢复原状。生产注册中心还应校验补偿入口可解析、 参数兼容，并把无法自动补偿的动作明确标成“不可逆”或“需要人工处置”。随手填一个假的补偿入口，比坦白没有补偿更危险。

2026 年 3 月，MCP 官方曾对 Tool Annotations 作了一次专门说明。readOnlyHint、destructiveHint、idempotentHint 和 openWorldHint 提供了一套风险词汇，由工具调用方提供给模型参考。但它们仍然只是 参考。第三方 Server 可以声称自己为只读，但客户端不能完全据此自动授予权限。元数据提供判断材料，本地策略与隔离机制才负责执行保证。

## 施加生产压力

写到这里，两道主要问题已经有了完整的答案。

最简工具集移除了发薪阶段不需要的主数据写工具，工具调度又通过 fresh state 和配额约束 transfer\_salary在 L2- 工具调度这个单线程、单进程、单对象场景里完成了一次正常的发薪任务。

单机 demo 能跑，不代表生产安全。接下来我们把这个教学 Dispatcher 放到四种更接近生产的压力下，找出哪些地方会因并发、状态变化、进程重启和补偿失败而失效。

![](https://static001.geekbang.org/infoq/96/96b1a747be0e081b38d678cdb518daaf.png)

我们用 S1、S2、S3 和 S4 对四种类型的压力测试进行编号。

### S1 并发配额竞态

第一个问题来自并发。

假设系统规定：一个工资批次只能执行一次。教学版本通常这样实现：

读取当前次数

↓

检查是否超过限制

↓

执行付款

↓

更新次数

看起来没有问题。但是，如果两个 worker 同时运行。Worker A 和 Worker B 进行了 fresh read，系统进行当前会话配额检查（quota = 0），两边都认为：“现在还没有付款，可以执行。”

于是：Worker A 付款成功；Worker B 也付款成功，最后系统写回：

quota = 1

但是现实发生的是：

真实付款次数 = 2

系统记录次数 = 1

系统账面认为只支付了一次，实际上钱已经出去两次。这就是典型的并发竞态（Race Condition）。

实际上会话配额只能解决 “Agent 不要调用太频繁”；但是支付系统还需要解决“同一个业务动作重复执行怎么办？”的问题这叫业务幂等（Idempotency）。

幂等的意思是：同一个请求，即使发送两次、十次，最终效果也只能产生一次。例如工资支付，可以生成一个唯一业务编号：

goal\_id + employee\_id + payroll\_month

例如：

bonus\_release\_2026\_06+E0007+2026-06

组成 UUID bonus\_release\_2026\_06\_E0007，通过数据库 ID 确保这个编号只能成功创建一次。

第一次请求：

创建成功

→ 执行付款

第二次请求：

发现编号已经存在

→ 查询第一次结果

→ 不再次付款

当前 Demo 中顺序是“读旧值、比较、执行、写回新值”。两个并发的 worker 可以同时读到 used=0，各自通过检查，最后都付款，计数却只写成 1。

在生产中支付还需要业务幂等进行控制，以保证同一业务动作即使重复请求，也只产生一次副作用。生产系统通常把 goal\_id + employee\_id + payroll\_month 组成稳定幂等键，在共享数据库中用唯一约束原子占位。第二个 worker 如果发现记录已经存在，应查询原动作结果，不能再次付款。这就是生产系统保护支付的基本方式。

### S2 读取后状态变化

第二个问题来自状态变化。

教学版本通常会记录：“我最近读取过这个数据。” 例如：Agent 查询员工 E0007 的工资：

10：00

工资 = 9600 元

系统记录“刚刚读取，可以使用”。一分钟以后：另一个流程修改工资：

工资 = 99600 元

但是 Agent 不知道。它仍然拿着旧数据执行付款：

支付 9600 元

或者行为更危险，比如支付错误的金额。这里的问题是检查的时候数据是正确的；使用的时候数据已经变了。这叫 TOCTOU（Time Of Check To Time Of Use），也就是检查时间和使用时间之间发生了变化。

解决方法不是简单记录：“我一分钟以前读过。”因为时间不能证明数据没有变化。更可靠的方法是给数据绑定版本。

例如：

@dataclass(frozen=True)

class StateEvidence:

resource\_ref: str

version: int

observed\_at: datetime

content\_hash: str

它的意思是我读取的不只是员工 E0007 工资；而是：

员工 E0007

版本 17

10:00读取

内容hash=xxxx

真正执行写入时，再检查现在版本是不是还是 17。如果版本一致；说明中间没有变化，可以继续。如果版本变成 18，就说明别人修改过，必须重新读取。这种：“只有版本匹配才允许更新”的方法叫比较后交换（Compare-and-Swap）很多数据库和并发系统都使用这个思想。

我们的教学实现只知道“这个会话最近读过东西”。压力台先读取 E0007 的 9600 元，随后 另一个流程把金额改成 99600。时间仍在 60 秒窗口内，付款照常通过。这就形成了检查时与使用时不一致，即 TOCTOU。解决它，fresh read 不能只留下时间戳，还要绑定对象和版本：

@dataclass(frozen=True)class StateEvidence:

resource\_ref: str

version: int

observed\_at: datetime

content\_hash: str

写入时再比较版本。版本不同，说明读取之后对象已经变化，应重新读取，并使绑定旧版本的审批失效。这种“版本相同才更新”的做法，通常叫比较后交换（compare-and-swap）。

### S3 进程重启失忆

第三个问题来自系统重启。

在我们的教学版本里，很多状态可能存在内存中。例如当前 quota、freshness 和补偿记录都存在名为 ToolDispatcher 的内存字典里。

quota = {}

fresh\_state = {}

saga\_log = {}

程序运行时这些信息都存在。但是服务器重启后，新的 Dispatcher 启动，内存全部清空后，系统就不再知道刚才有没有付款？有没有审批？有没有失败补偿？

例如，第一次执行：

create\_transfer\_batch()

但是程序随后崩溃。管理员重新启动 Agent 后新的进程看到没有执行记录，于是再次允许 create\_transfer\_batch()，结果工资重复支付。

所以生产系统需要一个行动账本（Action Ledger），它不是存在内存里的临时变量，而是持久化数据库。里面记录：幂等键、是否允许执行、使用的数据版本、执行结果、外部系统返回值以及补偿状态。

系统重启后的第一件事是先查账，看看这件事情以前发生过没有？查账之后再决定恢复还是重试。否则第一次付款后创建一个新实例，新进程看不见旧状态，同一动作会再次通过。

查账时还要注意：外部系统不一定告诉你结果。例如 Agent 调银行接口，请求发送出去，然后网络断开。系统收到 timeout。这时候不能简单认为失败了，也不能认为成功，真实状态可能是 UNKNOWN。因为银行可能已经收到请求，只是回执没有回来。所以系统必须根据幂等键查询银行结果，得到“结果确定性”，不能直接重试；否则一次付款可能变成两次。

### S4 补偿债务丢失

第四个问题来自恢复。

很多业务动作无法真正撤销。当工资已经打出去，由于某种原因需要撤销，你不能简单执行undo()。分布式系统通常使用 Saga 补偿模式——如果前一步不能回滚，就执行一个业务补偿动作。

例如付款函数 transfer\_salary() 需要通过reverse\_transfer() 函数进行对应的补偿：

transfer\_salary()

reverse\_transfer()

但是这里还有一个陷阱。比如下面的代码：

付款成功

↓

记录补偿任务

↓

执行冲正

↓

冲正失败

↓

删除记录

看起来流程结束了，但是如果钱已经支付，补偿失败，但是系统忘记了。例如工资状态是PAID，但是冲正为 FAILED，这时候系统必须保留这个补偿失败的状态，否则以后没有人知道“还有一笔钱需要处理。”

PENDING\_COMPENSATION

↓

COMPENSATING

↓

COMPENSATED

所以生产系统里的补偿状态应该长期保存，如果失败进入相关流程处理：

COMPENSATION\_FAILED

↓

MANUAL\_REVIEW / REDO

也就是说，调度器会把已经成功的破坏性动作及其反向操作写进 saga\_log。Saga 是长事务中常见的恢复办法：前一步无法原子撤销时，执行一个业务补偿动作，例如付款对应冲正。当前 rollback\_session() 遇到冲正异常，会返回 rollback\_failed，函数末尾却把这条记录从 saga\_log 移走。工资仍是 PAID，系统短暂知道补偿失败，返回后又忘了自己还欠一笔债。

因此，生产补偿至少需要这些持久状态：

PENDING\_COMPENSATION

\-> COMPENSATING

\-> COMPENSATED

\-> COMPENSATION\_FAILED

\-> MANUAL\_REVIEW

失败记录要保留重试次数、最后错误、下次重试时间和负责人，直到补偿完成或人工结案。

## 从教学 Dispatcher 走向生产

针对这四种失效条件补上生产控制，一个更完整的接口可以长成这样。这里的行动契约（Action Contract）约束目标与范围，审批票据（Approval Ticket）绑定批准人、参数和资源版本：

class DurableToolDispatcher:

def dispatch(

self,

intent: ActionIntent,

contract: ActionContract,

state\_evidence: list\[StateEvidence\],

approval: ApprovalTicket | None,

) -> ActionResult:

tool = self.selector.select(intent, contract)

decision = self.policy.decide(

tool, intent, state\_evidence, approval

)

self.ledger.append(decision.to\_event())

if not decision.allowed:

return ActionResult.blocked(decision)

lease = self.idempotency.acquire(intent.idempotency\_key)

if not lease.acquired:

return self.ledger.lookup\_result(intent.idempotency\_key)

result = self.executor.run(tool, intent.normalized\_args)

self.ledger.commit\_result(lease, result)

return result

幂等层返回的 lease 是执行租约，只有成功占位的一方可以调用真实工具。现在的例子比先前教学版多出四项正式能力：业务幂等键、资源版本证据、持久行动账本，以及能够恢复的审批与补偿状态。它没有要求每个 Agent 一上来就建设分布式事务平台。只有两三个只读工具、失败后可以直接丢弃时，注册表加参数校验已经够用。

支付、删除、发消息和运维变更进入系统以后，控制才需要逐级加厚。风险越高、副作用越难恢复，越值得把决策点、执行点和证据账分开。

## 怎样知道该修哪一层

最后留一张监控表。指标也按刚才的控制流来排：

| 指标 | 它帮助定位什么 |
| --- | --- |
| 工具发现召回率 | 正确工具有没有被搜索到 |
| 工具前沿召回率与大小 | 必要工具有没有被误删，当前候选是否过多 |
| 候选选择准确率 | 正确工具排在什么位置 |
| 准入拒绝原因 | 因状态、次数、审批还是权限被拒绝 |
| 重复副作用数 | 同一幂等键实际提交了几次 |
| 状态版本冲突 | fresh read 以后对象又变化了多少次 |
| 补偿债务年龄 | 未完成补偿积压了多久 |

只看“工具成功率”，发现、选择、准入和执行都混成了一个数字。分阶段指标才告诉团队该改工具描述、改工具前沿、改策略，还是修 Handler。

## 总结一下

这一讲沿着第 21 讲留下的两类问题，装上了两层控制。

最简工具集先为发薪任务建立当前工具前沿，修改账号和清除异议记录因此不可达。工具调度再读取工具契约，检查注册、调用次数、状态新鲜度和审批条件。错误的付款被拒绝以后，Harness 回到北极星目标，先查询，再完成一笔正确付款。

L0- 裸循环、L1- 最简工具集和 L2- 工具调度的数据库终态不足以独立证明这件事， 动作流水补上了重复副作用的证据。四种生产压力又告诉我们，教学版的配额、时间戳和内存 Saga 还不是生产保证。并发要靠业务幂等，状态要绑定资源版本， 执行要进入持久账本，补偿失败要留下债务。

最简工具集 + 工具调度的精华思想可以浓缩为：先缩小能做什么，再判断这次能不能做，做完以后还要能证明发生了什么。

最后延展一下，我们可以看看目前各大厂的工具运行时正往哪个方向发展。

工具数量增长以后，逐渐无法靠人工维护一张静态白名单。Anthropic 在 2025 年 11 月发布 Tool Search Tool，允许大量工具使用 defer\_loading 延迟加载。Agent 先搜索，命中后才把少量完整定义放进上下文。 这项能力把“系统拥有多少工具”和“本轮看见多少工具”拆开，正好对应最简工具集 的渐进发现。

到了 2026 年，开放协议开始补风险词汇，运行时框架也把检查贴近单次工具调用。OpenAI Agents SDK 的 Tool Guardrails 可以在自定义函数工具执行前后检查并阻断，而且文档明确列出了覆盖边界：托管工具（Hosted Tools）、内置执行工具和任务交接（handoff）不自动走同一条 Tool Guardrail 管线。使用框架时，仍要逐类核对哪些入口真的受控。

这些进展共同说明，工具调用正在从“模型返回一个函数名”走向三个互相配合的层次：按需发现、风险描述和运行时执行边界。任何一层都不能单独承担全部安全保证。

## 思考题

找一条真实工具误调用记录。它属于工具没被发现、前沿错误、选择错误、准入拒绝，还是 Handler 执行错误？你们当前日志能否区分？

为一个有副作用的工具写出三项准入条件。哪些条件只靠时间戳不够，必须绑定对象版本或审批票据？

给一笔薪酬付款设计业务幂等键。进程在远端付款成功、写本地回执之前崩溃，新进程应该查什么，绝不能直接做什么？

让补偿连续失败三次。补偿债务存在哪里，何时重试，什么时候转人工，谁是负责人？

期待你在留言区的发言，想清楚这些问题，你对今天所讲模式的领悟还能再上一层楼。

## 下一讲预告

工具调度管住了一次调用。长任务还有另一种麻烦：E0007 已经付款，E0012 调用网关时超时，恢复指令却要求整批重来。单次工具准入都合法，整批重跑仍可能重复付款。

接下来的模式继续解决不同层级的问题：

| 模式 | 它继续解决什么 | 与工具调度的接缝 |
| --- | --- | --- |
| 规划执行 | 多步任务怎样保持全局目标与局部恢复 | 每个计划步骤内部调用 Dispatcher |
| 提示链 | 上一步工件怎样不污染下一步 | 工件通过段间闸门后才形成行动意图 |
| 护栏三明治 | 高风险动作前后分别检查什么 | 准入通过后仍经过 PRE、TOOL、POST |

最简工具集和工具调度与这些模式各司其职。今天解决的是“当前有哪些手可以伸出去”和“选中的这只手此刻能不能动”。多步依赖、段间工件与执行后泄漏，留给后面三讲。

下一讲进入规划执行。我们会先冻结已经完成的事实，再把重规划限制在失败步骤及其依赖范围内，让局部故障不再拖着整条任务从头来过。

咱们下一讲见。

## 参考资料

ADPS 模式白皮书 https://adpsagent.com/zh/patterns/

Gamma, E., et al. Design Patterns: Elements of Reusable Object-Oriented Software. Command 与 Strategy 模式. 1994.

Saltzer, J. H. & Schroeder, M. D. The Protection of Information in Computer Systems. 1975. https://web.mit.edu/Saltzer/www/publications/protection/

Anthropic. Introducing advanced tool use on the Claude Developer Platform. 2025-11-24. https://www.anthropic.com/engineering/advanced-tool-use

Model Context Protocol. Tool Annotations as Risk Vocabulary: What Hints Can and Can't Do. 2026-03-16. https://blog.modelcontextprotocol.io/posts/2026-03-16-tool-annotations/

OpenAI Agents SDK. Guardrails: Tool guardrails and workflow boundaries. https://openai.github.io/openai-agents-python/guardrails/

公开

同步至部落

取消

完成

0/2000

直线

曲线

AI

2026-07-23给文章提建议

馨冉

Command + Enter 发表

0/2000字符

提交留言

大纲



固定大纲

L0 / L1 / L2 三层实验结果

第一层：先让越界工具不可达

第二层：合法工具也要先拿到准入

工具调度模式实现流程

被拒绝以后，谁把任务拉回正轨

把“选工具”拆成四个动作

为什么判断点和执行点必须分开

工具元数据要有人真正消费

注册时先拒绝自相矛盾的契约

施加生产压力

S1 并发配额竞态

S2 读取后状态变化

S3 进程重启失忆

S4 补偿债务丢失

从教学 Dispatcher 走向生产

怎样知道该修哪一层

总结一下

思考题

下一讲预告

参考资料