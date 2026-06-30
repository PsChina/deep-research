---
name: deep-research
description: 四阶段递归深度研究。好奇循环广泛探索 → 深度推理检测盲区 → 同行评审对抗验证 → 采纳优化后交付顾问级报告。适用于选型 / 竞品对比 / 技术调研 / 可行性评估 / 趋势综合等需跨多权威源交叉验证的开放问题；单点事实、写代码、纯计算、简单 how-to 不要用。

> 研究不是流水线，是四个可递归组合的阶段。deep-research 是可调用工具，不是全流程 orchestrator。
> 架构设计见 [`ARCHITECTURE_v6.md`](ARCHITECTURE_v6.md)，操作手册见 [`PLAYBOOK`](PLAYBOOK.md)，写作标准见 [`WRITING_STYLE`](WRITING_STYLE.md)。

---

## 触发

- `/deep-research <主题> [--quality=fast|standard|deep] [--eval]`
- 或问题需要跨多个权威源综合（选型/调研/对比/决策）
- **不需要深度研究**：单点事实、不依赖时效数据、"个人项目用 React 还是 Vue" → 降级为快速回答

---

## 架构：四阶段递归研究 + 两道覆盖率闸门 + 方向确认

```
Phase 0: 方向确认 🔴      → 展示研究计划 + 60s 窗口；方向已锁则跳过
Phase 1: 好奇循环        → 广泛探索，建立生态图，发现分类维度
Phase 1.25: 新鲜度扫描 🔴→ 强制闸门①：搜当月新发布实体，防静态汇总源滞后遗漏（增量）
Phase 1.5: 时效性校验 🔴  → 强制闸门②：核心数据是否最新 + 厂商覆盖是否完整（存量+增量）
Phase 2: 深度推理循环    → 换框自审（含厂商覆盖） + 盲区检测 + 形成可证伪判断
Phase 3: 同行评审        → 独立 sub-agent 对抗验证
Phase 4: 采纳与优化      → 逐条修正评审意见
Phase 5: 输出报告        → 顾问级分析报告
```

**递归关系**：Phase 2/3/4 可 spawn 子 Phase 1（好奇循环）和子 Phase 2（深度推理）。递归深度硬上限：fast ≤1, standard ≤2, deep ≤3。

**Phase 1.25 和 Phase 1.5 永远不可跳过**——这是从 Phase 1 进入 Phase 2 的两道硬闸门。Phase 1.25 防「新生事物未入静态汇总源」（增量盲区），Phase 1.5 防「已知数据过期 + 实体覆盖不全」（存量盲区）。

---

## Phase 0：方向确认（Direction Gate）🔴

**目标**：研究开始前展示计划 + 60s 窗口，让用户纠正方向。避免「跑完发现不是用户要的」。

### 先自判方向

一个问题：*有没有只有用户能拍板、且会改变「我研究什么」的方向选择？*

- **方向已锁 → 不展示计划清单、不起计时器**：1-2 行压缩陈述「我理解的问题 + 切入角度」后直奔 Phase 1。命中任一即锁：
  ① 主题 + 要查的具体现象/主张已给全、无实质分叉、无缺会改变全局的约束（诊断/核实/查现状类，如「X 为什么 Y」「X 是不是真的」「X 现状如何」；⚠️「现象/主张唯一」≠「归因框架/核实口径唯一」——归因角度、核实口径或覆盖范围多义、选哪个会改写「研究什么」→ 判待定）；
  ② 输入含「立即开始 / 马上开始 / 直接开始 / 不用确认 / 别问了 / skip」。

- **方向待定 → 展示计划 + 走 60s 窗口**。命中任一即待定：survey/选型类（含「现状如何 / 有哪些 / 盘点」式伪装句）、研究范围或口径需用户定、问题有多种解读、缺会改变全局的约束。

判不准默认「待定」——错锁方向的代价远大于多等 60s。

### 计划展示（仅待定时）

AI 输出：我理解的问题 / 初步判断（可推翻）/ 3-5 研究角度 / 预期深度（fast·standard·deep）/ 你会得到什么 / 你能改什么。如有澄清问题，合并提出（≤3 个）。

### 60s 窗口

打 `⏱️ 60s 后自动开始；想改现在说，或回「立即开始」直接跑`，跑 `sleep 60`（`run_in_background:true`）让出回合，记住其 task id。

- **窗内用户回复** → **先用该 id `TaskStop` 杀计时器**（漏杀 = 幽灵计时器稍后二次开跑，**头号 bug，先 kill 再动**），再按意图走：改 → 重规划（最多 1 个活跃计时器）/ 批准·立即开始 → Phase 1 / 不做 → 停。
- **计时器到点或沉默重唤** → Phase 1；先确认本轮未开跑（无本轮 researcher 派工 / Dispatch Gate 记录），已派则忽略防重复。未答澄清按模板默认走，报告末尾标 `clarify_assumed`。
- **环境不自动重唤** → 降级为「等你批准」（= 老行为，绝不卡死）。

方向已锁 / 批准 / 超时后自主推进，不再打断（例外仅：密钥泄露 / 武器 / 工具完全失败）。

---

## Phase 1：好奇循环（Curiosity Loop）

**目标**：广泛探索，不设预设分类框架。让搜索结果揭示「这个领域怎么分」。

**角色分工**：
- 主 agent = 协调者：发问、派工、综合、判断
- sub-agent = 执行者：搜、读、摘录（不带判断）

**每轮流程**：
1. 发问：生成 3-6 个 curiosity_questions（无产品名/公司名）
2. 标注类型：[core]（影响中央判断）→ 派 2 个独立 sub-agent；[fill]/[verify] → 派 1 个
3. 🔴 同帧并行 spawn 所有 deep-research 工具调用
4. 综合返回 → 去重、交叉验证、更新框架
5. 判断边际收益 → 继续/收敛

**🔴 curiosity_questions 必须覆盖的维度（每轮至少各 1 条）**：
- **无偏探索**：描述性语言，不带产品名/公司名（如「行业头部」「新兴挑战者」）
- **维度穷举**：按 Phase 1 已发现的**每个分类维度**，穷举该维度下的实体，逐个搜其最新状态。如研究某技术领域 → 维度含「厂商」「代际」「许可模式」等；研究某工具选型 → 维度含「类型」「部署模型」等。🔴 **维度清单从当期研究动态发现，不预设、不硬编码、不跨研究复用**。目的：防静态汇总源只覆盖部分维度/实体导致系统性遗漏
- **反方/失败案例**：主动搜索反对观点和负面评价
- **🔴 系统性偏见盲区检测（每轮必查，不可跳过）**：主动搜索以下偏见盲区——任何一种偏见都可能导致报告系统性失真：
  - **地理/语言偏见**：英文 query 搜 Google 返回西方产品，中文 query 搜中文源返回中国产品。只用一种语言 = 系统性遗漏另一生态。任何有 ≥2 个重要独立实体的地理/语言生态，必须作为 [core] 方向独立派工
  - **开源 vs 商业偏见**：只搜到「best open source X」或「best enterprise X」→ 另一侧完全遗漏
  - **成熟 vs 新兴偏见**：汇总源天然偏向已建立声誉的老牌玩家，新兴实体被系统性低估
  - **分类框架偏见**：[core] vs [fill] 的标注本身可能引入偏见——如果某类实体的竞争力模型不匹配当前框架（如寄生策略 vs 自研全栈），可能被错误降级为 [fill]
  - 🔴 上述任一类偏见在 Phase 1 每轮至少产生 1 条主动探测 query（如中文 query、开源特化 query、新进入者 query 等）

**收敛条件**：连续 2 轮未发现新分类维度 / 新实体全 filler / 达硬上限（fast=1, std=3, deep=5 轮）。

---

## Phase 1.25：新鲜度扫描（Freshness Sweep）🔴

**目标**：Phase 1 收敛后，强制搜索「当月/近期新发布」的实体。**防静态汇总源滞后——排名/对比表/市场报告/目录等聚合页面从更新到收录新实体有 2-4 周延迟，刚发布的实体会系统性遗漏。**

**为什么需要这道闸**：Phase 1 的 curiosity_questions 偏总结性（「best X 2026」「top Y comparison」），搜索引擎返回的是已有排名的汇总页面（排名/对比/目录/报告等），不是新闻式结果。Phase 1.5 只检查已知数据的时效，不探测未知实体的存在。二者都防不住「6 月 20 日发布的新版本，6 月 30 日做研究」。

### 0. 实体审计（Phase 1 → Phase 1.25 转换步骤）🔴

Phase 1 的发现中，实体天然分布在多个层级——顶级产品名、底层模型/引擎/协议/依赖、被引用但未被独立追踪的组件。**任何一个层级遗漏都可能导致后继探测盲区。**

**从 Phase 1 findings 中提取 ALL 命名实体**，包括：
- 作为其他实体属性/依赖/组件/底层引擎出现的实体（如某云服务基于某数据库引擎 → 提取该引擎；某编排系统依赖某存储组件 → 提取该组件）
- 被列为对比对象但未深度追踪的实体
- 在「国内生态」「开源替代」等子段落中提及但未展开的实体

**提取后整理为扁平实体清单**，不分子集、不预设重要性排序。每个实体在下述 4a/4b 中至少生成 1 条 query。

> 此步骤不引入任何领域术语——它是纯粹的实体提取操作，跨所有研究主题通用。

### 扫描 query（必须包含）

> ⚠️ Phase 1.25 **豁免** Phase 1 的「无产品名/公司名」约束。此处需要**精确狙杀**，不是泛化探索。以下模板均为抽象模式，执行时填入当期主题和实体名；**禁止在技能文本中堆砌领域特化示例**。

1. `"<主题领域> new release <current_month> <current_year>"`
2. `"<主题领域> latest launch just announced <current_year>"`
3. `"<主题领域> <current_month> <current_year> 最新发布"` （中文源）

4. 🔴 **逐实体狙杀式搜索（不可跳过，必须对 Phase 1 发现的每个实体生成至少 1 条 query）**：

   **4a. 逐实体最新状态查询**：对 Phase 1 发现的**每个**实体（无论领域：产品/框架/库/协议/芯片/模型/标准等），生成：
   ```
   "<实体名> latest version release <current_month> <current_year>"
   "<实体名> <current_month> <current_year> 最新发布"  （中文源实体用中文）
   ```
   🔴 **多语言强制规则**：每个实体至少生成 1 条英文 query + 1 条其原生语言 query。非英语原生厂商实体必须同时用其原生语言搜索最新动态——英文源对这些实体的报道存在 1-4 周延迟且覆盖不完整。

   **4b. 🔴 后继探测（防「已知 X 但 X 已被替代」）**：
   Phase 1 发现某个实体 ≠ 该实体仍是最新/最优。必须主动探测是否存在后继者（替代品、升级版、新代际、新版本、更正或撤稿等）：
   - **命名可预测时**（实体有明确的版本号、代际号、年份号等递增标识）→ 按命名惯例生成 N+1、N+2 的精确 query 探针
   - **命名不可预测时**（实体无结构化版本标识，如品牌产品、学术论文、市场报告等）→ 4a 的「latest」query 为主力，辅以时间约束新闻搜索（`"<实体名> <current_month> <current_year>"`）
   - 发现后继存在 → 该实体标记为「已被替代」，立即 spawn 子 Phase 1 深挖后继
   - **核心原则**：不假设已知实体就是终点。找到什么不代表什么就是最新的

   **4c. 无偏兜底**（仅此一条不带实体名，防 Phase 1 完全未覆盖的新维度/全新品类）：
   `"<主题领域> new entrant emerging <current_year>"`

### 判定

- **发现 Phase 1 未覆盖的新实体** → spawn 子 Phase 1 深挖该实体，然后重新判定收敛
- **未发现新实体** → 通过，进入 Phase 1.5
- **硬上限**：≤2 轮补搜

### 输出

`{new_entities_discovered[], sub_phase1_spawned: true/false, sweep_passed: true/false}`

---

## Phase 1.5：时效性校验（Freshness Gate）🔴

**目标**：Phase 1 收敛后、进入深度推理前，强制验证所有核心数据的时效性。**这是硬闸门，Phase 1.5 不通过不得进入 Phase 2。**

**闸门判定（逐条检查每个 [core] finding）**：

| 检查项 | 判定标准 | 不通过动作 |
|---|---|---|
| **日期锚定** | `source_date` 在 freshness 窗口内（见 Tier 映射表） | spawn 子 Phase 1，query 强制带 `current_month current_year` |
| **代际检查** | 结论引用的实体是否为**当前最新**？（判定方法：对每个实体执行后继探测；4a 的 latest query 为主，命名可预测时辅以递增探针） | 对每个实体执行后继探测确认最新，替换过时引用 |
| **竞品对称性** | 所有核心竞品的基准数据是否来自**同一时期**？（不同实体的数据时间窗口必须对齐，否则比较无意义） | 统一拉齐到同一时间窗口重新搜索 |
| **反方时效** | 反方/批评观点是否也覆盖了**最新版本**？（旧版批评可能已被新版修复） | 搜索最新版本的批评/问题反馈 |
| **🔴 维度穷举完整度** | Phase 1 发现的**每个分类维度**下的实体是否已穷举？是否存在某维度下漏了重要实体？（判定方法：从 Phase 1 findings 提取分类维度清单，逐维度检查实体清单；缺失实体分三类——搜索遗漏/静态汇总源未收录/确实不存在，前两类必须补搜） | 从 Phase 1 findings 提取分类维度清单（动态构建），逐维度检查实体穷举是否完整；缺则补搜 |

**通过标准**：所有 [core] finding 通过上述 5 项检查。最多 2 轮补搜；2 轮后仍有不通过的，标记为 `[stale-gap]` 并在报告中显式声明「以下结论基于旧数据，置信度降级」。

**输出**：`{stale_findings[], replacement_findings[], gaps_marked_stale[], dimension_coverage: {discovered_dimensions[], entities_per_dimension{}, missing_entities[]}, gate_passed: true/false}`

---

## Phase 2：深度推理循环（Deep Reasoning Loop）

**目标**：带着 Phase 1 的生态图，做深度分析——形成判断、检测盲区、交叉验证。

**🔴 换框自审（强制首步，不可跳过，必须输出以下 checklist 结果）**：

**框架自审**：
1. 我目前用什么分类框架理解这个领域？
2. 如果换一个学科/市场/视角，会用什么不同框架？
3. 有没有「我根本不知道存在的类别」？
4. 我的分类框架本身有哪些盲区？

**🔴 维度穷举自审（强制，防「汇总源里没有就以为不存在」。分类维度 + 实体清单均从当期研究动态构建，不预设）**：
5. 从 Phase 1 + Phase 1.25 的 findings 中**提取所有已发现的分类维度**（维度名完全由当期研究主题决定，不预设、不举例）→ 逐维度检查：该维度下的实体是否已穷举？
6. 每个维度下，有没有重要实体在 Phase 1 所依赖的汇总源中完全缺席？（可能原因：搜索遗漏 / 汇总源未收录 / 该实体确实不存在。前两种 → spawn 子 Phase 1 补搜）
7. 有没有已发现实体的后继者（替代品/升级版/新代际/撤稿/更正等）未被探测？（Phase 1.25 的后继探测应已捕获 → 若漏网，立即补搜）
8. 有没有新维度/新实体未在任何 Phase 1 search result 中出现？（Phase 1.25 的无偏兜底应捕获）→ 若有，spawn 子 Phase 1 深挖
9. 对于所有缺失，Phase 1.25 和 Phase 1.5 是否已补全？若未 → spawn 子 Phase 1 补搜
10. 🔴 **系统性偏见自审（强制，五类偏见逐条过，不可敷衍）**：
    a. **地理/语言偏见**：是否默认英文生态为"主生态"，将非英语实体降级为 [fill]？→ 若有，升级为 [core] 并用原生语言独立深挖
    b. **开源 vs 商业偏见**：是否只覆盖了开源或只覆盖了商业产品？→ 缺哪侧补哪侧
    c. **成熟 vs 新兴偏见**：Phase 1 发现的实体是否全是老牌玩家？→ 主动搜新进入者/挑战者
    d. **分类框架偏见**：[core]/[fill] 标注是否引入了系统性歧视？——某类实体的竞争力模型若不匹配当前框架（如寄生策略 vs 自研 Agent 壳），可能被错误降级
    e. **基准/评测偏见**：引用的基准是否只反映某一生态/某类产品的表现？→ 例：某基准可能主要评测某一语言/生态的产品
    → 任一类查出问题，spawn 子 Phase 1 补搜后重新判定收敛。

**输出格式**（必须显式写在推理中，不可跳过）：
```
换框自审结果:
- 当前框架: <框架名>
- 替代框架: <框架名>
- 未知类别风险: <有/无，描述>
- 已发现分类维度: [维度1 (实体数: N), 维度2 (实体数: M), ...]
- 各维度缺失实体: [{维度, 缺失实体, 原因: <搜索遗漏/汇总源未收录/确实不存在>}]
- 代际/版本缺失: [{实体, 已有版本, 最新版本, 发布日期}] → 补搜: <是/否>
- 全新维度/实体（Phase 1.25 无偏搜索发现）: [...]
- 盲区汇总: <一句话>
```

**每轮流程**：
1. 换框自审（含维度穷举） → 产出 {盲区, 矛盾, 弱支撑, 维度缺失, 代际缺失}
2. 标注类型：[core] → 2 sub-agent，其余 → 1
3. 🔴 同帧并行 spawn 子好奇循环 + 子深度推理 + 验证搜索
4. 综合 → 更新 Central Thesis + 反事实 + 置信度
5. 自我拷问 → 继续/收敛

**收敛条件**：盲区填补完毕 + 判断可证伪 + 每个核心结论 ≥2 独立来源 + 非 echo chamber。

---

## Phase 3：同行评审（Peer Review）

**目标**：对抗性验证。🔴 必须派独立 sub-agent（fresh context），主 agent 不得自审。

**推荐并行模式**（std/deep）：同帧 spawn 2-3 个 reviewer——
- Reviewer A：证据可靠性（来源质量、数据可追溯、时效性）
- Reviewer B：逻辑与框架（Central Thesis 可证伪性、换框自审是否敷衍）
- Reviewer C：覆盖度与遗漏（维度穷举完整度、后继探测执行度）

**🔴 Reviewer C 必须回溯审计所有阶段的收敛自检记录**：逐条检查每条反停止信号的历史判定是否有敷衍痕迹。发现敷衍收敛 → 对应阶段判定不合格，回退重跑。

**输出**：`{attacks[], echo_chamber_detected, missing_perspectives[], convergence_audit: {phase, passed,敷衍_detected}[], overall_verdict}`

---

## Phase 4：采纳与优化（Adopt & Optimize）

逐条处理评审意见。critical+severe 必须处理，moderate 建议处理或标 known-limitation。
需补证据/重新论证的 → 🔴 同帧并行 spawn 子循环。

---

## Phase 5：输出报告

从研究者切换到写作者。不是 findings dump——有 Central Thesis、反事实、置信度、下一步。末尾留追问钩子。

---

## 收敛闸门

### 🔴 收敛前置自检（硬闸门 — 每个阶段宣告收敛前必须输出，不可跳过）

> 收敛不是感觉「差不多了」——收敛是**逐条检查后判定不可继续**。以下自检清单必须在每阶段收敛时显式输出。

```
收敛前置自检:
- 反停止信号扫描:
  [是/否] 发现新分类维度？（是 → 不可收敛）
  [是/否] 新证据推翻了已有结论？（是 → 不可收敛）
  [是/否] echo chamber — 某方向全是同向、缺反方？（是 → 不可收敛）
  [是/否] 意外发现 Phase 1 完全未覆盖的重要实体？（是 → 不可收敛）
  [是/否] 核心结论只有 1 个独立来源？（是 → 不可收敛）
  [是/否] 后继探测发现已知实体已被替代？（是 → 不可收敛）
  [是/否] 存在 [core] finding 数据过时或维度穷举不全？（是 → 不可收敛）

- 主动追问（至少 1 条，证明本轮真正思考了而非敷衍收敛）：
  "如果我是这个领域的反对者，我会质疑什么？"
  "当前框架下最可能漏掉的实体类型是什么？"
  "如果再多搜一轮，最可能改变什么判断？"

- 收敛声明: "以上反停止信号全部为否，主动追问已自答且不改变收敛判断。本轮宣告收敛。"
```

⚠️ 如果「反停止信号」任一为「是」，**禁止收敛**——必须 spawn 对应子循环继续。

⚠️ 如果「主动追问」回答后发现新的搜索方向，**禁止收敛**——追加一轮。

⚠️ 收敛自检不是走过场。重复输出「全部为否」但未给出实质推理的，视为敷衍收敛，判定为不合格。

### 🔴 审核机制：自查 vs 独立审核

| 收敛类型 | 审核方式 | 说明 |
|---|---|---|
| **阶段内轮次收敛**（如 P1 第 2 轮→第 3 轮） | **主 agent 自查**，输出自检清单 | 轻量级；自检输出作为审计轨迹，供 Phase 3 回溯验证 |
| **阶段过渡收敛**（P1→P1.25, P1.5→P2） | **主 agent 自查 + 独立审核者抽查** | std/deep 层级：spawn 独立 agent（fresh context）审核收敛自检是否敷衍。fast 层级可跳过 |
| **最终报告（Phase 3）** | **独立 agent 强制审核** | Phase 3 的 reviewer 必须回溯检查所有阶段的收敛自检记录，判定是否存在敷衍收敛。发现敷衍 → 对应阶段判定不合格，回退重跑 |

> 原则：裁判不能兼运动员。自查是效率，独立审核是质量。关键闸门（阶段过渡 + 最终报告）必须有他查。

### 各阶段收敛条件与硬上限

| 阶段 | 收敛条件 | 硬上限 | 最少年轮数 |
|---|---|---|---|
| Phase 0 | 方向已锁 或 60s 到期 或 用户批准 | — | — |
| Phase 1 | 连续 2 轮无新维度 **且** 收敛自检全部通过 | fast=1, std=3, deep=5 | fast=1, std=2, deep=3 |
| Phase 1.25 | 逐实体后继探测完成 **且** 收敛自检通过 | ≤2 轮补搜 | 1 |
| Phase 1.5 | 所有 [core] finding 通过 5 项检查 **且** 收敛自检通过 | ≤2 轮补搜 | 1 |
| Phase 2 | 盲区填补 + 判断可证伪 + 证据 ≥2 源 **且** 收敛自检通过 | ≤4 子循环 | fast=0, std=1, deep=2 |
| Phase 3 | overall_verdict: pass 或 conditionally_pass | 2 轮 | — |
| Phase 4 | 所有 critical/severe 已处理 | — | — |

> 最少年轮数是防止敷衍收敛的兜底——即使「感觉够了」，也必须跑满最少轮数才能进入收敛自检。

---

## Workflows 编排铁律

```
🔴 每个 Phase 内，所有独立子任务必须同帧并行 spawn，不串行。

🔴 冗余策略：
  [core] 方向（影响 Central Thesis）→ 2 个独立 sub-agent 交叉验证
  [fill]/[verify] 方向 → 1 个 sub-agent
  每 Phase 每轮 [core] 方向 ≤2 个（避免冗余爆炸）

🔴 主 agent 只亲自做 3 件事：发问、换框自审、综合判断。
  其余一切搜/读/摘录/验证 → sub-agent。
```

---

## deep-research 工具契约

```yaml
deep-research:
  description: 对指定主题执行一轮聚焦搜索+阅读，返回结构化发现。
  input:
    topic: string
    scope: broad | focused
    phase: curiosity | deep_reasoning | peer_review | optimize
    curiosity_questions: [string]     # 🔴 必填
    known_dimensions: [{name, entities}]
    known_entities: [{name, type, needs_deep_dive, reason}]
    max_rounds: number
    freshness: "month" | "week" | "year"
  output:
    findings: [finding]
    discovered_dimensions: [{name, description, confidence, entity_count}]
    discovered_entities: [{name, type, confidence, impact, needs_deep_dive}]
    answered_questions: [string]
    new_questions: [string]
    framework_stable: boolean
    marginal_value: {new_dimensions, decision_affecting, filler}
    should_continue: boolean
```

---

## Tier 映射与并行度

| Tier | 触发 | freshness 窗口 | P1 轮数 | P1 并行 | P2 子循环 | P3 | 总搜索 | 字数 |
|---|---|---|---|---|---|---|---|---|
| **fast** | "快速/简要" | **1 年内** | 1 | 1-2 | 0 | 跳过 | ≤5 | 1000-2500 |
| **standard** | 默认 | **3 个月内** | 3 | 3-5 | ≤2 并行 | 1-2 reviewer | ≤20 | 2500-5000 |
| **deep** | "深度/全面" | **1 个月内** | 5 | 5-8 | ≤4 并行 | 2-3 reviewer | ≤40 | 5000-12000 |

> 🔴 **freshness 窗口是 Phase 1.5 闸门的判定基准**。所有 [core] finding 的 `source_date` 必须在此窗口内，否则不通过。

---

## 黄金法则

| # | 法则 | 一句话 |
|---|---|---|
| 1 | **不编造** | 每个数字有可追溯来源。不确定就说"不确定" |
| 2 | **找反方** | 主动搜索反对观点和失败案例。一面倒 = 没做完 |
| 3 | **标缺口** | "我不知道 X → Y 判断置信度只到 Z" |
| 4 | **给判断** | 有 Central Thesis、有置信度标注、有可执行下一步 |
| 5 | **可证伪** | 每个核心结论附带"什么情况下这个结论是错的" |
| 6 | **有时效** | 每个 finding 标注 source_date |
| 7 | **并行优先** | 所有独立子任务同帧发出——不等不串行 |
| 8 | **核心才冗余** | [core] 方向 2 个交叉验证，其余 1 个——不浪费 |
| 9 | **主 agent 不搜** | 搜/读/摘录全部走 sub-agent。主 agent 只发问、换框、综合 |
| 10 | **防静态汇总源滞后 + 维度穷举** | Phase 1.25 强制搜当月新发布；Phase 1.5 + Phase 2 逐维度穷举实体。分类维度从研究动态构建，不预设。不假设「汇总源没有就不存在」 |
| 11 | **后继探测** | Phase 1.25 必须对每个已发现实体主动探测是否存在后继者。找到什么不代表什么就是最新的——不探测就断言「最新」等于没做新鲜度扫描 |
| 12 | **防系统性偏见** | 五类偏见（地理/语言、开源vs商业、成熟vs新兴、分类框架、基准评测）每轮主动探测。中英文双生态搜索是底线——只用一种语言 = 系统性遗漏另一生态。非英语生态有 ≥2 个重要实体必须升级 [core] |

---

## 反模式

| ❌ | ✅ |
|---|---|
| 主 agent 自己搜/读 ≥3 个来源 | 调 deep-research 或 spawn sub-agent |
| 🔴 忽略系统性偏见——只用英文搜全球产品、默认非西方实体是 [fill]、开源/商业只盯一侧、只信某一生态的基准 | Phase 1 每轮至少 1 条偏见盲区探测 query（中文/开源特化/新进入者等）；Phase 2 换框自审第 10 条五类偏见逐条过；任何一类查出 ≥2 个重要遗漏实体 → 升级 [core] 独立派工 |
| 🔴 Phase 2 换框自审跳过偏见检查或只查地域不问其他 | 换框自审第 10 条五类偏见（地理/开源vs商业/成熟vs新兴/分类框架/基准评测）全部逐条回答，不得只写「无」不附推理 |
| 主 agent 串行一个一个发 sub-agent | 同帧并行 spawn——所有独立子任务一起发出 |
| 所有子方向无差别派 2 个 | [core] 2 个交叉验证，其余 1 个 |
| 搜索 query 含具体产品/公司名 | 描述性语言：「行业头部」「新兴挑战者」——但 curiosity_questions 必须同时包含厂商穷举 query |
| Phase 2 跳过换框自审 | 换框自审是强制首步，必须输出 checklist（含厂商覆盖检查） |
| Phase 2 换框自审只问框架不问维度穷举 | 换框自审必须逐维度检查实体穷举——「汇总源里漏了某个重要实体，是没搜还是不存在？」 |
| Phase 1.25 新鲜度扫描被跳过 | Phase 1.25 和 Phase 1.5 同为硬闸门，不可跳过 |
| Phase 3 主 agent 自审 | 独立 sub-agent（fresh context） |
| 发现盲区标 `[gap]` 跳过 | spawn 子好奇循环填补 |
| deep-research 一键生成报告 | 它返回发现，综合和判断在主 agent |
| 一面倒无反方 | 每条核心方向 ≥1 反方 |
| Sub-agent 返回 raw dump 原样转用户 | 主 agent 提炼 → 综合 → 判断 → 呈现 |
| 搜索 query 不限制时效 / 用裸年份 `2025` | 所有 query 带 `current_month current_year`；Phase 1.5 闸门强制校验 |
| Phase 1 收敛后直接进入 Phase 2 | 必须先过 Phase 1.25（新鲜度扫描）+ Phase 1.5（时效性校验）两道闸门 |
| 信任单一汇总源覆盖全维度 | 每个汇总源（排名/对比表/市场报告等）都有收录延迟和选择性偏差；Phase 1.5 + Phase 2 逐维度验证穷举完整度 |
| Phase 1.25 实体提取不完整——只对顶级产品名做后继探测，忽略作为属性/依赖/组件出现的实体 | Phase 1.25 必须先执行实体审计（步骤 0）：从 Phase 1 findings 中提取 ALL 命名实体——包括作为其他实体属性/依赖/组件/底层引擎出现的实体；扁平清单，不分子集，每个实体至少生成 1 条 query |
| Phase 1.25 用泛化 query 代替逐实体狙杀 | Phase 1.25 必须对 Phase 1 发现的每个实体生成 per-entity query + 后继探测；不得只用「<主题领域> new release」一条泛 query 敷衍 |
| Phase 1.25 不执行后继探测 | Phase 1.25 必须对每个已发现实体探测是否存在后继者（替代品/升级版/新代际/撤稿/更正等）；命名可预测时用递增探针，否则用 latest + 时间约束 |
| 感觉差不多就收敛，不输出收敛自检 | 每阶段收敛前必须输出收敛前置自检清单，反停止信号逐条判否 + 主动追问 ≥1 条；敷衍自检（无实质推理）视为不合格 |

---

## Researcher Prompt 模板（deep-research 工具内部使用）

> 主 agent 调用 deep-research 工具时，工具内部自动使用此模板派 researcher sub-agent。

```
你是 deep-research researcher sub-agent。唯一任务是研究以下 sub-question 并返回结构化 JSON。

## Sub-question
<填入 sub_Q>

## Query seeds (每个都搜，含至少1条反方query + 🔴 所有 query 强制带时效性约束)
1. "<正向搜索query> + latest + current_month current_year"
2. "<正向搜索query> + latest + current_month current_year"
3. "<反方/批评/失败案例 query> + current_month current_year"
4. "<时效性query: topic + latest/recent + current_month current_year>"

🔴 **时效性约束不是可选的**——所有 query 必须包含 `current_month current_year` 或等价时间锚点。
禁止使用裸年份（如 `2025`）作为唯一时效性约束——必须精确到月。

## Budget
≤20 WebSearch, ≤12 WebFetch。优先官方来源。

## Tool Fallback
anysearch 失败 → 重试1次 → WebSearch → WebFetch。禁止凭记忆补 finding。

## Extract 后处理
1. URL 去重
2. 相关性筛选（每个 extract ≤3 句 why relevant，写不出的丢弃）
3. 去重后 < tier_min 则补搜

## Output schema (🔴 严格按此格式输出JSON)
{
  "sub_question": "<sub_Q原文>",
  "findings": [{
    "finding_id": "F-<编号>-<序号>",
    "claim": "<一句话事实主张，≤200字>",
    "evidence_span": "<来源原文关键句，≥50字>",
    "source_url": "<URL>",
    "source_type": "official_doc|academic|financial_media|industry_blog|community",
    "source_date": "YYYY-MM-DD",
    "confidence": "HIGH|MEDIUM|LOW",
    "challenges_thesis": true/false
  }],
  "source_funnel": {"identified": N, "screened": N, "extracted": N, "included": N, "exclusion_reasons": {}},
  "dedup": {"before": N, "after": N},
  "query_resilience": {"total": N, "succeeded": N, "failed": N, "threshold_met": true},
  "key_insight": "<1句话总结>"
}
```

---

## 红线

- ❌ 编造数字或来源 · ❌ 报告含 token/密钥 · ❌ 付费墙/登录页/武器/非法内容 · ❌ 一面倒

## 参考文件

[`ARCHITECTURE_v6.md`](ARCHITECTURE_v6.md) 架构 · [`PLAYBOOK`](PLAYBOOK.md) 操作手册 · [`WRITING_STYLE`](WRITING_STYLE.md) 写作 · [`REPORT_TEMPLATES`](REPORT_TEMPLATES.md) 骨架 · [`RUBRIC`](RUBRIC.md) 评分 · [`CHANGELOG`](CHANGELOG.md) 版本
