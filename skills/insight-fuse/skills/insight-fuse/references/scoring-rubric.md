# Scoring Rubric — 6 维正交评分 + 19 项 blocking check

v3.4 报告质量尺。Stage 6 QA 跑完 19 项 check 后，按 6 维公式计算总分，映射为 A/B/C/D 等级（author 自评）；Stage 6.5 reviewer agent 独立复核；main agent 在报告 footer 插入合并评分块（含 author/reviewer 双分数 + Δ + disputed_checks）。

**v3.1 增量**：evidence_density 维度新增子项 `primary_source_ratio`（见 §一）；Check 15-17 按 `--type` / `--depth` 分档 blocking（见 [research-types.md](research-types.md) §源可靠性分档）。

## 一、6 维正交框架

来源：调研方法论文献收敛的跨学术/产业/政策三大传统的 6 个正交维度。任何一维都不是充分条件；合格报告在所有 6 维都达阈值。

| 维度 | 核心判据 | 评分依据 |
|------|---------|---------|
| **falsifiability**（可证伪性） | 命题必须在原则上可经验证伪（Popper） | Critic 的 FALSIFICATION_CONDITIONS 覆盖率；hypotheses.falsifiability 填充度 |
| **evidence_density**（证据密度） | 每实证主张有可追溯一手来源 | inline citation 数 / 段落数；L1-L2 来源占比；**primary_source_ratio**（量化声明 L1 占比，v3.1）|
| **reproducibility**（可复现性） | 方法、数据、工具可被独立复现 | 方法论披露完整度；数据/链接/版本号；timestamp 标注 |
| **source_diversity**（来源多样性） | 独立来源覆盖多库 / 多语言 / 多立场 | 来源数量；独立性链完整度（Check 10）；跨语言覆盖 |
| **actionability**（可行动性） | 结论可转化为决策或后续行动 | Outlook 段 scenario-conditional 深度；Advisory Appendix 质量（若有） |
| **transparency**（透明度） | 方法、局限、利益、AI 使用全披露 | limitations 段存在；COI 披露；AI 使用标注 |

每维 **0-10** 分，采用**分段式评分**：

| 分段 | 0-3 | 4-6 | 7-8 | 9-10 |
|------|-----|-----|-----|------|
| falsifiability | 无可证伪条件 | 部分 hypothesis 有证伪条件 | 所有 hypothesis + Critic 覆盖 | 全 claim-level 可证伪，含 pre-registration 锚 |
| evidence_density | < 1 cite/section；primary_source_ratio < 30% | 1-2 cite/section；primary_source_ratio 30-50% | ≥ 3 cite/section，L1-L2 > 40%；primary_source_ratio 50-70% | ≥ 5 cite/section，L1-L2 > 60%，零未引用主张；primary_source_ratio > 70% |
| reproducibility | 无方法披露 | 工具名提及 | 版本 + 参数 + 数据源 | 全链路可复现（代码/数据/配置） |
| source_diversity | < 3 来源或单源占比 > 60% | 3-5 来源，单源占比 40-60% | 6+ 来源，单源 ≤ 30%，跨类型 | 10+ 来源，跨语言 + 跨立场，独立性链完整 |
| actionability | 仅描述现状 | 含 implications | scenario-conditional outlook | 具体 recommendation + 策略梯度（Appendix 合规） |
| transparency | 无 limitations | limitations 简述 | limitations + COI + 方法披露 | 含 AI 使用披露 + 反立场考量 + 边界声明 + **`{uncal}` 数字显式标注**（v3.4 与 C19 联动） |

**v3.4 transparency 联动**：TL;DR 出现 `{uncal}` 数字 → transparency 维度自动 -1（C19 fail 不单独封顶 Grade，但通过 transparency 降分间接影响 total）。详见 [quality-standards.md §1.11](quality-standards.md)。

### primary_source_ratio 子项定义（v3.1）

```
primary_source_ratio =
  |{量化声明 c : ∃ s ∈ c.support 使 s.tier = L1 且 s.host ∈ whitelist[type]}|
  / |{量化声明 c}|
```

- 分母：正文所有量化声明数（数字 / 百分比 / 日期 / 排名；`{P}` 或 `{S→...}` 标注的 claim）
- 分子：至少一条 support 命中白名单 L1 的 claim 数
- academic 权重分段中 primary_source_ratio < 50% → evidence_density 封顶 5（不足及格）
- market 同理（market 权重偏产业，但数据口径刚性同 academic）

### v3.4 增量

| 增量 | 触发位置 | 影响 |
|------|---------|------|
| **Stage 6.5 reviewer pass** | Stage 6 之后、Stage 7 归档之前 | 独立 reviewer agent 读最终报告，给 6 维独立评分；Δ ≥ 1.0 触发 Reconciliation；footer 加 `Author/Reviewer/Δ/Disputed checks` 四字段（见 §五） |
| **C18 Load-bearing cross-validation** | 跨节单源 [F] 关节 | 与 C15-C17 同档；`scripts/scan-load-bearing.sh` 自动扫描 + reviewer 复核；不可替代 source 须 `[SINGLE_SOURCE_RISK]` 注解（见 [quality-standards.md §1.10](quality-standards.md)） |
| **C19 Calibration discipline** | confidence 数字（%、N/10、概率词） | 一律 blocking；TL;DR 与 Outlook 段禁 `{uncal}`；与 transparency 维度联动（见 §1.11） |

起因：2026-04 三份 v3.x 报告横向 review 暴露 cross-report 自评分 inversion + cross-section 单源过载 + vibes-based confidence 现象，C12-C17 未覆盖。

## 二、加权公式

```
total = Σ (dim_score × weight_i) / Σ weight_i × 10
```

权重按 `research_type` 分 academic vs industry 两档：

| 维度 | academic 权重 | industry 权重 |
|------|:-:|:-:|
| falsifiability | 0.25 | 0.15 |
| evidence_density | 0.20 | 0.15 |
| reproducibility | 0.20 | 0.10 |
| source_diversity | 0.15 | 0.20 |
| actionability | 0.05 | 0.25 |
| transparency | 0.15 | 0.15 |
| **Σ** | **1.00** | **1.00** |

`research_type` 属性：

- **academic**：`academic`
- **industry**：`overview` / `technology` / `market` / `product` / `competitive`

## 三、等级映射

| Grade | 区间 | 意义 |
|-------|-----|------|
| **A** | 8.5 - 10.0 | 可直接采用，达到发表/决策标准 |
| **B** | 7.0 - 8.4 | 合格，建议补充关键缺口后使用 |
| **C** | 5.5 - 6.9 | 局部可用，需针对低分维度返工 |
| **D** | < 5.5 | 不及格，建议重写或换 type |

任一 blocking check 失败（Check 1-19 中任一未过，且该 check 当前模式为 `blocking` 而非 `advisory`）→ Grade 封顶 D，无论 6 维得分多高。分档策略见 [research-types.md](research-types.md) §源可靠性分档。

## 四、19 项 blocking check（Stage 6 全扫；Stage 6.5 reviewer 复核）

| # | Name | 校验 | Shell 验证命令 |
|---|------|------|-----------|
| 1 | Source density | 每节 ≥ 2 citation | `grep -cE "^\\[" report.md` |
| 2 | Reference integrity | inline citation 全在 reference list | `diff <(grep -oE "\\(https?://[^)]+\\)" report.md \| sort -u) <(awk '/^### 参考来源/,/^---/' report.md \| grep -oE "https?://[^)]+" \| sort -u)` |
| 3 | Source diversity | 单源 ≤ 40% 任一 section 内 | 按 section 统计 URL 频次 |
| 4 | Evidence-backed | 比较/排序断言必带数据 | 模式扫描（`faster\|leads\|outperforms` 等关键词附近 100 字符内必有 URL） |
| 5 | Date line | header 有 `> 日期：YYYY-MM-DD` | `grep -cE "^> 日期：20[0-9]{2}" report.md` ≥ 1 |
| 6 | Attribution | footer 有 forge attribution | `grep -c "Researched by.*forge/insight-fuse" report.md` ≥ 1 |
| 7 | Environment isolation | 无未授权专名 | grep against `--audience` + `--focus` + 用户 msg 白名单 |
| 8 | Neutral body | 主体（首个 `---` 前）无"针对 X 建议" | `grep -nE "(对\|给)[^。]*(的)?(建议\|启示)\|对我们的启发\|为[^。]*(设计\|打造)" body.md` 为空 |
| 9 | Advisory Appendix integrity | 若有 Appendix，6 节结构全齐 | 按 `## Appendix` 切块，验证每块含受众画像/调研依据/推导链/策略梯度/风险与反事实/行动清单 |
| 10 | Source independence | 独立性声明存在且合理 | `grep "独立性声明：" report.md` ≥ 1 |
| 11 | Causal claim discipline | 因果断言含 ≥3 替代解释 | 因果关键词 + 后续 100 字符内含"替代解释\|confounding\|selection\|reverse causation" |
| 12 | Framework preservation | `skeleton.known_dissensus` 每项渲染三段式 | `grep -c "立场 A\|Position A" report.md` ≥ `jq -r '.known_dissensus \| length' skeleton.yaml` |
| 13 | Structure-ratio compliance | 章节字数在模板 ±30% | `awk '/^## /{sec=$0; next}{wc[sec]+=NF}END{for (s in wc) print s, wc[s]}' report.md` 与 template 声明比例对比 |
| 14 | FIR separation | 段首标 `[F]`/`[I]`/`[R]` | `grep -cE "^\\[F\\]\|^\\[I\\]\|^\\[R\\]" report.md` == 段落总数 |
| 15 | Primary-source binding | 量化声明 support[] 含 ≥1 L1 且命中 whitelist | `grep -oE "\\{P\\}\|\\{S→" report.md` 数 ≥ 量化声明数；`{S→}` 有 primary-url |
| 16 | Verbatim evidence snippet | 量化声明下紧邻 `> 原文："..." — <Source>, <YYYY-MM-DD>` | `grep -B1 "^> 原文：" report.md \| grep -c "^\\[F\\]"` ≥ 量化声明数 |
| 17 | Numeric variance reconciliation | 同声明跨源差 > 5% → Reconciliation log 附录存在 | `grep -c "## 附录.*Reconciliation log" report.md` ≥ 冲突声明数 |
| 18 | Load-bearing cross-validation *(v3.4)* | 跨 ≥ 2 sections 含 `[F]` 量化声明的 source 必须 ≥ 1 条独立交叉验证；不可替代时 section 末插 `> [SINGLE_SOURCE_RISK]` 注解 | `bash scripts/scan-load-bearing.sh merged-report.md`（输出空 = pass；输出 LOAD_BEARING list 时 reviewer 在 Stage 6.5 复核交叉验证 / 注解到位） |
| 19 | Calibration discipline *(v3.4)* | confidence 数字（百分比 / N/10 / 概率词）紧跟 `{cal: ...}` 或 `{uncal}`；TL;DR 与 Outlook 段禁 `{uncal}` | `grep -nE "[0-9]+%\|[0-9]+/10\|概率\|可能性" report.md` 每条命中后续 ≤ 50 字符内含 `\\{cal:\|\\{uncal\\}`；TL;DR 段与 Outlook 段额外扫 `\\{uncal\\}` 必须为零 |

Check 1-11 的详细出处、例外、失败处理见 [quality-standards.md](quality-standards.md)；Check 12-14 见 §1.4-1.6；Check 15-17 见 §1.7-1.9；**Check 18-19 见 §1.10-1.11**。

## 五、评分块模板

Stage 6 计算 author 评分；Stage 6.5（v3.4 新增）reviewer agent 独立评分；main agent 在报告 footer 自动插入合并块：

```markdown
---

## 质量评分

| 维度 | Author | Reviewer | 权重（<type> weighting） | Author 贡献 |
|------|:-:|:-:|:-:|:-:|
| Falsifiability | 8 | 7 | 0.15 | 1.20 |
| Evidence density | 9 | 7 | 0.15 | 1.35 |
| Reproducibility | 6 | 6 | 0.10 | 0.60 |
| Source diversity | 8 | 7 | 0.20 | 1.60 |
| Actionability | 7 | 7 | 0.25 | 1.75 |
| Transparency | 8 | 7 | 0.15 | 1.20 |
| **Total** | **7.70** | **6.85** | | |

**Author score**：7.70 / 10
**Reviewer score**：6.85 / 10  *(v3.4)*
**Δ**：0.85（< 1.0：无 Reconciliation）  *(v3.4)*
**Disputed checks**：[]  *(v3.4 — reviewer 标记的 ill-fit checks，不计入 fail)*

**Grade**：**B**（建议补充 reproducibility 披露：具体 WebSearch 查询词、访问日期、版本号）

**Blocking checks**：19 / 19 passed（[任何失败的 check id 在此列出，如 `C15-FAILED` / `C16-ADVISORY` / `C18-ADVISORY` / `C19-FAILED`]）
**Primary source ratio**：<N>%（量化声明中 L1 覆盖占比，v3.1）
```

**Reviewer fail-soft**（reviewer agent 不可达 / 返回 malformed）footer 退化为：

```markdown
**Author score**：7.70 / 10
**Reviewer score**：unavailable (<reason: timeout|malformed|skipped-quick-depth>)
**Δ**：n/a
**Disputed checks**：n/a
```

不阻塞 Stage 7 归档——保 archival mandatory + observable 契约。

## 六、失败处理

| 情形 | 行为 |
|------|------|
| Blocking check 1-19 任一失败（分档执行，`advisory` 级不封顶 Grade）| 重写对应 section，重查；最多 2 轮，第 3 轮仍失败则输出并标 `QA-FAILED: <check-ids>` header |
| 6 维某维 < 4 分但 total ≥ 7 | 保留 Grade 但在评分块标"低分维度"，列补救建议 |
| 6 维某维 < 4 分且 total < 7 | Grade 降 1 档（B→C），强制给出返工方向 |
| **Stage 6.5 Δ ≥ 1.0** *(v3.4)* | main agent 必须追加 `## §X Reconciliation` 段：列 reviewer `DOWNGRADES` 每条，author 逐条响应（accept / partial-accept-with-revised-score / reject-with-counter-evidence）；最终采纳分数写入 footer。Reconciliation 段在 Stage 7 归档前必须完成 |
| **Stage 6.5 reviewer fail-soft** *(v3.4)* | footer 标 `Reviewer score: unavailable (<reason>)`，不阻塞 Stage 7；warning 行追加到 Archive 日志 |
| `--no-save` + Grade D | 输出到控制台但拒绝归档到 KB |

## 七、示例

假设 overview 类报告：

- falsifiability=8, evidence_density=9, reproducibility=6, source_diversity=8, actionability=7, transparency=8
- 权重（industry）：0.15, 0.15, 0.10, 0.20, 0.25, 0.15
- 贡献：1.20 + 1.35 + 0.60 + 1.60 + 1.75 + 1.20 = **7.70**

→ Grade **B**。低分维度：reproducibility。补救建议：补上"调用时间、WebSearch 查询词、访问日期"三项；补完重跑即可升到 A。

若同样报告但 research_type=academic：

- 权重：0.25, 0.20, 0.20, 0.15, 0.05, 0.15
- 贡献：2.00 + 1.80 + 1.20 + 1.20 + 0.35 + 1.20 = **7.75**

→ 同样 B。学术语境下 reproducibility 权重更高（0.20 vs 0.10），因此补救优先级更靠前。
