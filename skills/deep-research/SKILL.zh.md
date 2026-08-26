---
name: deep-research
version: 1.0.0
author: AMiner
contact: report@aminer.cn
description: >
  基于 AMiner 开放平台数据与宿主原生 web 工具，产出一份带引用、分层编号的研究报告——并在同一次运行中产出 Evidence Ledger：报告背后那份自描述、带版本的 JSON（sources、claims、figures、probes），下游任何系统可直接原样复用。
  当用户需要文献综述、研究全景、实体调研、趋势对比、行业 / 市场调研，或任何"要的是有出处的研究报告而非一次查询"的请求时激活本 skill。
  由宿主模型（正在运行本 skill 的模型）驱动一个固定的研究循环——先侦察问题、从检索返回的内容归纳大纲、按小节检索、把每个来源记入证据台账、发现缺口、迭代——没有台账来源支撑的结论不得进入报告。
  AMiner 的路由与定价位于 scripts/aminer_open.py；web 证据来自宿主自身的 WebSearch 与 WebFetch。免费优先；预估 AMiner 花费达 CNY 10+ 需显式确认，CNY 20 为硬上限。不调用任何额外 LLM 服务。
  路由到其他 skill：单点查询（用 aminer-free-academic）、只要数百篇论文清单而不要报告的综述收集（用 aminer-deep-search）、个性化推荐（用 aminer-daily-paper）。
metadata:
  {
    "openclaw":
      {
        "requires": {
          "bins": ["python3"],
          "env": ["AMINER_API_KEY"]
        },
        "primaryEnv": "AMINER_API_KEY"
      }
  }
---

# Deep Research 深度研究

你是研究者，而不是一个搜索框的封装。先侦察问题，让报告的结构跟随检索实际返回的内容，把每个来源记入台账，写一份每条结论都能回指到你检索到的来源的报告。

## 语言路由

- 当用户主要用中文写作或明确要求中文输出时，使用本文件（`SKILL.zh.md`）。
- 其余请求使用 `SKILL.md`。
- 两种流程下，代码、命令、台账字段名与 API 名保持英文；只有叙述文字切换语言。

## Deep Research 产出两份产物 (v6 §1.2/§7.6)

Deep Research **不只是**一个终端成果（给人看的报告）。一次 DR 迨行在同一条流程上产出两份产物——一份带引用的报告，以及一份 **Evidence Ledger**：引擎自身用来给每条结论把关的那份结构化 JSON（sources、claims、figures、datums、probes、outline、spend）。台账是自描述、可复用的；下游任何系统拿它做什么，是那个系统的事，不是 skill 的事。skill 不认识、也不命名任何消费者：

```text
Deep Research Engine (scripts/evidence.py + scripts/aminer_open.py)
   ↓ 一次运行
   ├── Evidence Ledger      (scripts/evidence.py 状态 JSON — 自描述、可复用)
   └── Report + appendices  (evidence.py render --final / --appendix)

自检，无外部消费者：evidence.py check · evaluation/evaluate.py
```

台账是引擎自身的状态——它**不是手写的**，而是从研究循环里自然落出来的 (§7.6)。它是一份自描述、带版本的 JSON：下游任何人（一个 context store、一个 RAG 索引、一个评审流水线，或什么都没有）都可以原样读取。skill 产出它就止步——不导出、不转换、不把它适配到任何其他系统的 schema；那种适配是外部系统的职责，不是 skill 的。

### 子模块 (v6 §7.13)

- `scripts/evidence.py` — **引擎 + 证据台账 + 报告渲染器**：研究循环、机器可消费的台账状态（`{version, topic, probes, outline, sources, claims, figures, datums, spend}`）、`analyze()` 自检，以及 `render`。
- `scripts/aminer_open.py` — AMiner 开放平台检索（stdlib urllib，26 个端点，价格目录，费用文档）。DR 自身的花费追踪路径 (§7.14)。
- `scripts/chartrender.py` — 把一个已登记的 figure 渲染成 PNG。由宿主调用（`aminer_open.py` 的兄弟工具，绝不被 `evidence.py` 派生——后者保持纯离线台账）：确定性的 matplotlib 模板（`bar` / `hbar` / `line` / `pie` / `heatmap`），或一个宿主写的 B 脚本在尽力而为的沙箱里运行（无网络、锁定 cwd、30 秒超时、禁用 token 扫描、数据经 stdin 传入）；B 脚本失败则回退到对应模板。figure 的数字始终来自台账，因此 `check` 的 data↔source 把关在任何路径下都成立。
- `evaluation/evaluate.py` — 来自 `analyze()` 的质量报告 (§7.13 第 5 个子模块，§7.15 内部验证)。
- `samples/patchtst_v3_ledger.json` — v3 schema 的样例台账 (PatchTST)。
- `references/research-loop.md` — 实际流程（任务开始时读它）。

## 适用范围

- 用于：文献综述、研究全景、学者 / 机构 / 期刊 / 专利调研、趋势与对比类问题、行业 / 市场调研、任何需要引用的场景。
- 路由到别处：单点查询（`aminer-free-academic`）、数百篇论文的综述文献清单（`aminer-deep-search`）、个性化推荐（`aminer-daily-paper`）。

## 预检

1. 除非用户另有要求，用用户的语言作答。
2. 至多问两个问题，且仅当不同答案会改变研究范围时才问。否则说出你的假设并开始。
3. AMiner key 在 shell 环境里作为 `AMINER_API_KEY` —— 宿主在调用 skill 前把它 export 进来（如 `export AMINER_API_KEY=…` 或 source 一个 `.env`），`aminer_open.py` 只从这里读，别处不读。若 key 缺失或无效，脚本返回鉴权错误——此时停下，指引用户去 [AMiner Console](https://open.aminer.cn/open/board?tab=control)。绝不请求、打印、记录或保存 token。

## 工具

| 需求 | 工具 |
| --- | --- |
| 论文、学者、机构、期刊、专利 | `scripts/aminer_open.py` — 带价格的 AMiner 允许端点 |
| web 知道而 AMiner 不知道的：项目页、文档、标准、排行榜、发布、新闻 | 宿主原生的 `WebSearch` 与 `WebFetch` |
| probes、outline、sources、claims、datums（采集的数据点）、覆盖缺口、引用编号、spend | `scripts/evidence.py` — 离线台账 |
| 把一个已登记的 figure 渲染成 PNG —— 可视化台账已核验数字的图表，或按日期事件的结构化时间线 | `scripts/chartrender.py` — matplotlib 模板（`bar` / `hbar` / `line` / `pie` / `heatmap` / `timeline`）或沙箱 B 脚本；用 `evidence.py figure mark-rendered` 把结果记回 |

规则：

- 每个 AMiner 请求都走 `scripts/aminer_open.py`。绝不手搓请求、替换别的搜索 API，或调用 `references/api-reference.md` 之外的端点。
- web 证据用宿主自己的工具；不打包或不 shell 出一个爬虫。优先用 `WebFetch` 抓实际页面，而非信任搜索摘要。若原生 web 工具不可用，继续纯 AMiner 路径并在报告里说明。
- 没进台账的东西不得进入报告，且 `evidence.py render` 没打印的小节不得存在。

在选择 AMiner 调用前读 `references/api-reference.md`。它把 `paper_qa_search_pro` 标为默认的主题搜索，解释为何 `query_type: "auto"` 是默认以及何时降到 `topic`，列出能纠偏一个漂移查询的字段，并标注哪些端点是免费的。

## 方法

遵循 `references/research-loop.md`。它是实际流程——在任务开始时读它，而不是等你已经花了钱之后。

其形：

- **Round 0 —— 先侦察，再归纳。** 定义问题，`evidence.py init`（行业 / 市场调研传 `--genre industry`——genre 在 `init` 设定，驱动 figures-expected 的 `check`），跑 3–4 个 `paper_qa_search_pro` probe（`query_type: "auto"`，约 ¥2.80）——按对象与结构化过滤器分开，而非换措辞——用免费 `paper_info` 做分诊，给留下的候选买 `paper_detail`，然后从返回内容归纳出 2–4 个带编号的顶层小节，每个含 2–4 个子小节，其中恰有一个是 `disagreement` 子小节。检索前不要臆造小节标题。
- **每轮** —— 按小节检索（AMiner + web）→ 把结果用 `--probe <id>` 不打标地 pipe 进来，再只给留下的打 `--section <id>` 标、`drop` 掉噪声 → 读（免费 `paper_info` 分诊先于付费 `paper_detail`）→ `evidence.py gaps` → 决定是否继续。
- **收尾** —— `evidence.py check` 必须退出 0，随后 `evidence.py render --final` 给出台账视图（编号、每小节 claims、稳定的台账源编号）——**把报告写成基于台账 claims 的草稿散文，引用一律用 `[@n]` 占位符（n 为台账编号），绝不把 `render --final` 贴进正文**（不要 `c1` id、不要 `_来源：` 行、不要 `_（分歧）_` 标签、不要裸 `冲突：` 项目符号），末尾放一个参考文献标题，内含一行 `{{references}}` 占位符。接着 `render --renumber --draft <path> --out <path>` 把占位符替换为按正文首现递增的稠密引用号，把参考文献槽填成只含被引源的文献表，并在交付报告旁写一个 citation-map sidecar——`[@n]` 指向未知或已丢弃的源会硬报错。最后 `render --appendix --out auto --citation-map <sidecar>` 写出各附录表（附录 D 为报告↔台账编号对照）并返回报告要引用的那一行。若报告有 figure，`figure add` → `chartrender.py` → `figure mark-rendered` 链必须先跑过——`render --final` 为每个已登记 figure 输出一个 `_[FIGURE fN] …_` 占位符，你在组装草稿时用图片嵌入替换它。对于行业报告，figure 和一张竞品对比表是预期项，不是可选项。

快速开始：

```bash
python3 "${CLAUDE_SKILL_DIR}/scripts/evidence.py" init --topic "RAG evaluation"
# 行业 / 市场调研：
# python3 "${CLAUDE_SKILL_DIR}/scripts/evidence.py" init --topic "中国大模型行业调研" --genre industry

python3 "${CLAUDE_SKILL_DIR}/scripts/evidence.py" probe --axis topic --via paper_qa_search_pro \
  --query "retrieval augmented generation evaluation"
python3 "${CLAUDE_SKILL_DIR}/scripts/aminer_open.py" --api paper_qa_search_pro \
  --params '{"query":"retrieval augmented generation evaluation","query_type":"auto","year_from":2023,"sort":"balanced"}' \
  | python3 "${CLAUDE_SKILL_DIR}/scripts/evidence.py" add --aminer --probe p1
python3 "${CLAUDE_SKILL_DIR}/scripts/aminer_open.py" --api paper_info --params '{"ids":["<id>","<id>"]}' \
  | python3 "${CLAUDE_SKILL_DIR}/scripts/evidence.py" add --aminer
python3 "${CLAUDE_SKILL_DIR}/scripts/evidence.py" drop --source 7 9 --reason "off topic"
python3 "${CLAUDE_SKILL_DIR}/scripts/aminer_open.py" --api paper_detail --params '{"id":"<id>"}' \
  | python3 "${CLAUDE_SKILL_DIR}/scripts/evidence.py" add --aminer

python3 "${CLAUDE_SKILL_DIR}/scripts/evidence.py" outline set --json '[
  {"title":"Evaluation methods","from_probes":["p1"],"children":[
    {"title":"LLM-judge metrics"},
    {"title":"Disagreement: judge validity","kind":"disagreement"}]}]'

python3 "${CLAUDE_SKILL_DIR}/scripts/evidence.py" add --section 1.1 --json '[{"kind":"paper","id":"<id>","title":"..."}]'
python3 "${CLAUDE_SKILL_DIR}/scripts/evidence.py" claim --section 1.1 --supports 1 4 \
  --text "LLM-judge metrics dominate reported RAG evaluation since 2023"
python3 "${CLAUDE_SKILL_DIR}/scripts/evidence.py" gaps
```

## 调用脚本 —— 以及台账在哪

通过 `${CLAUDE_SKILL_DIR}` 调用脚本，这样脚本路径不依赖 cwd。skill **不拥有任何台账位置**——路径由宿主选定。当没有任何一方指定时，默认把本次运行的工作区设在当前项目下的 `outputs/<主题slug>-<YYYYMMDD-HHMM>/` 每运行一目录（台账在其根、图在 `figures/` 下，各次运行互不覆盖），解析成绝对路径并告诉用户台账在哪——这是宿主施加的默认，不是引擎的假设。设一次，`export DR_LEDGER=<workspace>/evidence-ledger.json`，之后每个 `evidence.py` / `evaluate.py` 调用都从 `$DR_LEDGER` 读（或显式传 `--state` / `--ledger`）。skill 不假设 `knowledge/`、`.zscience/` 或任何目录——持久化与 scratch 是宿主的职责；台账是 skill 的输出（以及可选的输入），不是 skill 拥有的文件。绝不把台账写到 `${CLAUDE_SKILL_DIR}` 下（skill 树是只读源）。

台账*就是* skill 的结构化输出——一份自描述、带版本的 JSON。skill 产出它就止步：不导出、不转换、不把它适配到任何其他系统的 schema。任何想要另一种形态的研究成果的系统（context store、RAG 索引、简报）都在 skill 之外自己读台账并做那件事。

```bash
# 台账视图 —— 用来对照写草稿的content基准（编号是台账 n）
python3 "${CLAUDE_SKILL_DIR}/scripts/evidence.py" render --final
# 交付报告：[@n] 占位符换成按首现递增的 [N]，参考文献槽变成只含被引源的
# 文献表，并写一个 citation-map sidecar
python3 "${CLAUDE_SKILL_DIR}/scripts/evidence.py" render --renumber \
  --draft <draft.md> --out <report.md>
# 附录（检索日志 / 花费 / 数据与方法 / 引用号对照）写在台账旁边
python3 "${CLAUDE_SKILL_DIR}/scripts/evidence.py" render --appendix --out auto \
  --citation-map <report-citation-map.json>
# skill 对台账的自有质量报告 (§7.13)
python3 "${CLAUDE_SKILL_DIR}/evaluation/evaluate.py" --ledger "$DR_LEDGER"
```

## 花费控制

- 免费优先：付费之前先用免费的发现与消歧端点；免费 `paper_info` 先于付费 `paper_detail`。
- **按查询形态路由。** `paper_qa_search_pro`（¥0.70）是主题与多过滤搜索的默认项，也是 Round 0 侦察所用。当查询已经是结构化过滤（作者、机构、期刊，或带引用/年份排序的单个受控关键词）时，降到 `paper_search_pro`（¥0.01）。
- **以 `query_type: "auto"` 发送查询——即 query 模式。** 相比非 LLM 模式约 5 秒 vs 0.4 秒，远在 30 秒超时之内（付费端点不自动重试），召回更好。仅在字面词匹配时降到 `topic`，并在那时用 `all_terms` 锚定概念。按对象与过滤分 probe，绝不按换措辞分。
- **读你所引。** 搜索结果不带摘要；免费 `paper_info` 切片约 190 字符；`paper_detail` ¥0.01 给全摘要 + 关键词。当一条结论依赖一篇你从未好好读过的论文时，`check` 会以 `cited_sources_without_detail` 警告。
- **每次结果都看 `warnings` 和 `total`。** `aminer_open.py` 把它们从响应里提出来；一条 warning 意味着跑的查询不是你发的那个。
- 付费调用前用 `--dry-run` 或 `--batch` 估算整条计划链。`add --aminer` 把实际花费累计进台账；一个你丢弃了命中的付费调用仍需 `evidence.py spend`。
- 一个完整学者画像约 ¥6.00。到 ¥10.00 展示调用计划并等确认，然后传 `--confirm-high-cost`。累计到 ¥20.00 时，`check` 阻断——停下并交付部分结果。

## 预算

2–4 个顶层小节 · 每个 2–4 个子小节、其中一个是 disagreement 子小节 · 3–4 个 probe（约 ¥2.80）· 4 轮 · 每轮 ≤2 次付费 `paper_qa_search_pro` 调用且 ≤3 次 web 调用，¥0.01 的 `paper_search_pro` 不限 · 每个顶层小节 ≤8 个候选 · 每任务 ≤50 次付费 detail 调用 · ≤5 次 `paper_relation` 扩展 · 每报告 ≤6 个 figure（每小节 ≤2；Genre A 可选、Genre B ≥1 预期；无花费——由 `chartrender.py` 本地渲染，当数值数据单薄时 `timeline` 模板跑按日期的事件）· ¥10.00 确认阈值 · ¥20.00 硬上限。一次典型运行落在 ¥4–6 附近，其中搜索约占 92%——省搜索，不省摘要。

## 失败处理

- **空搜索**：在*不同轴*上重述一次——不同的主题短语或结构化过滤，而非换同义词——然后报告缺口，而不是第三次尝试。
- **歧义实体**：展示顶部候选并让用户选。绝不给每个候选都买 detail。
- **API 错误**：报告公开的端点名与可操作信息；绝不暴露 header 或凭据。
- **挨饿的小节**：把它并入邻居，而不是为对称去买搜索。单薄的子小节就写成单薄、并标注单薄。
- **证据单薄**：`check` 失败，于是收窄结论并交付一份明确受限的报告。绝不用记忆填补缺口。
- **无 web 工具**：继续用 AMiner 并在报告的 Limitations 小节记录该限制。

## 输出

按 `references/report-format.md` 写最终报告。两种 genre，从任务框架里选：一份**学术综述**（默认——文献综述、研究全景、实体调研）和一份**行业报告**（行业 / 市场调研："行业调研"、"市场格局"、"竞争格局"）。无论哪种 genre，报告都是**你从台账 claims 写出的散文——不是把 `render --final` 贴进正文。** `render --final` 是台账视图：从一次运行里取小节 / 子小节编号、每小节按序的 claim 集合，以及稳定的台账源编号；把每个子小节写成承载其 `[@n]` 引用占位符的流畅散文，并在对比多个实体时用表。`render --renumber` 把草稿变成交付报告——按正文首现递增的 `[N]` 编号、只含被引源的文献表，以及一个 citation-map sidecar。不要把台账脚手架——claim id（`c1`）、来源池行（`_来源：`）、`_（分歧）_` / `_（解读）_` 标签，或裸 `冲突：` 项目符号——贴进报告；那些是台账内部物。附录**不是**报告的一部分：`render --appendix --out auto` 把附录 A（检索日志）、B（调用与花费）、C（数据与方法）写到台账旁的一个文件，你只往附录 C 追加几条台账无从知晓的方法事实。probe id、检索轴、API 名、价格与筛选计数都待在那个文件里，绝不进报告。对于**行业报告**，骨架是咨询形态（执行摘要 / 市场规模 / 带对比表的玩家格局 / 竞争动态 / 技术与专利 / 供应链与算力 / 政策 / 展望），检索以 web 为先（市场数据、融资、芯片、政策），AMiner 作为技术 / IP 通道，且至少一张 figure（市场份额 / 玩家 / 时间线）加一张玩家对比表是预期项，不是可选项。`render` 按台账 topic 的语言输出其标题；照印参考标题与条目，而非翻译它们。

## 规则

- **台账里没有的，不得进报告。** `render` 没打印的小节不存在；没有台账来源的 claim 不出现。
- **"figure" 的两层含义。** 小写 *figure*（如 `claims_with_unsourced_numbers` 里的）指一条结论里引用的数字——它必须出现在某个被引来源里。一个已登记的 *Figure*（`figure add`，id `f1…`）指渲染成 PNG 的图表——它的 `data` 受同一数字溯源规则检查（`figures_unsupported_numbers`）。两者都取自台账数字；都不许显示台账未背书的数字。
- **对抗式核验是强制的。** 每个顶层小节都有一个 `disagreement` 子小节；每条关键结论都对照一个可能反驳它的来源做了检查。
- **不伪造引用。** 每条引用必须是 `aminer_open.py` 返回的真实实体，或经 `WebFetch` 实际抓取的页面。
- **大结果落盘。** 当搜索结果超过 20 条或裸 API 输出超过 5000 字符时，把中间结果写到宿主选定的 scratch 路径（如 `$DR_WORKDIR/scratch/`），而非留在上下文里。skill 不假设 `.zscience/` 或其他 scratch 目录。stdout 只给短状态：`"Found N results, saved to <path>"`。
