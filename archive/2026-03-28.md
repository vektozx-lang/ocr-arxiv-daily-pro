# OCR / 文档解析研究日报（2026-03-28）

## 报告说明

- 检索源：arXiv API
- 检索查询：`(all:"document parsing" OR all:"document understanding" OR all:"optical character recognition" OR all:OCR OR all:"layout analysis" OR all:"document layout analysis" OR all:"text recognition" OR all:"table recognition" OR all:"form understanding" OR all:"document intelligence" OR all:"page understanding" OR all:"scene text recognition" OR all:"handwritten text recognition" OR all:"information extraction") AND (cat:cs.CV OR cat:cs.AI OR cat:cs.CL OR cat:eess.IV)`
- 生成时间（UTC）：`2026-03-28 03:45:57`
- 大模型综合分析：`开启`

## 一、今日执行摘要

> 今日论文聚焦于OCR与文档解析的多方面创新：历史文档的LLM情感分析、像素空间代理的主动视觉学习、以及高效场景文本检测与布局分析。研究趋势显示，结合LLM处理降质文本、开发主动视觉系统、以及优化SAM模型以提高效率是当前重点。这些工作为历史文档分析、动态OCR任务和实时文本处理提供了实用框架，但面临语言泛化、训练复杂性和标注依赖等挑战。工程团队可关注特定语言模型适配、主动视觉框架集成和高效推理优化。

## 二、今日趋势判断

研究趋势呈现三个方向：一是利用LLM增强OCR降质文本的分析能力，特别是在历史文档的情感与主题挖掘；二是发展主动视觉系统，通过像素级操作集成OCR实现动态学习与改进；三是优化SAM-based模型，通过减少提示点和整合异构数据提升场景文本检测与布局分析的效率。整体上，工作强调多方法融合、效率优化和跨领域应用。

## 三、今日论文概览

1. **Approaches to Analysing Historical Newspapers Using LLMs** | 标签：历史文档分析、OCR降质文本处理、LLM情感分析、主题建模、实体图可视化
2. **Pixelis: Reasoning in Pixels, from Seeing to Acting** | 标签：像素空间代理、主动视觉学习、OCR集成、测试时强化学习、视觉语言系统
3. **ET-SAM: Efficient Point Prompt Prediction in SAM for Unified Scene Text Detection and Layout Analysis** | 标签：场景文本检测、布局分析、SAM优化、高效推理、异构数据训练

## 四、今天 OCR / 文档解析论文里的主要创新点

- 结合LLM与主题建模处理OCR降质文本的情感分析和话语挖掘。
- 设计轻量级解码器或代理以减少计算开销并加速推理过程。
- 整合异构标注数据集通过联合训练策略提升模型泛化性能。
- 应用测试时学习或强化学习实现模型在无标签数据上的自适应改进。

## 五、后续 OCR 领域值得推进的改进方向

- 开发更鲁棒的LLM情感分类方法，专门针对OCR降质历史文本中的情感不平衡问题。
- 扩展像素空间代理的可执行操作集，以支持更复杂的OCR任务和视觉交互场景。
- 优化SAM-based框架的点解码器设计，在保持速度的同时提高文本检测和布局分析的精度。
- 研究多语言适配技术，提升OCR和文档解析模型在跨语言历史文档中的泛化能力。
- 结合细粒度OCR后处理技术，减少文本降质对下游分析任务的影响。

## 六、工程落地启发

- 适配特定语言LLM模型如GaMS3-12B-Instruct，可提升历史文档OCR后情感分析的准确性。
- 集成Pixelis类主动视觉框架，适用于需要动态OCR和实时视觉分析的交互式应用。
- 采用ET-SAM的轻量级点解码器和联合训练策略，能加速场景文本检测并处理异构数据。
- 实施测试时RL或奖励微调机制，可在部署后持续优化OCR系统的性能。

## 七、优先关注论文

- **Approaches to Analysing Historical Newspapers Using LLMs**：展示了LLM在OCR降质历史语言中的情感分析应用，为处理低质量文档提供了新方法。
- **Pixelis: Reasoning in Pixels, from Seeing to Acting**：提出了主动像素空间代理框架，集成OCR实现动态学习，可能推动视觉-OCR系统的发展。
- **ET-SAM: Efficient Point Prompt Prediction in SAM for Unified Scene Text Detection and Layout Analysis**：优化了SAM模型以加速推理并整合异构数据，对实时文本检测和布局分析有工程价值。

## 八、论文逐篇解析

### 1. Approaches to Analysing Historical Newspapers Using LLMs

- arXiv: [2603.25051v1](https://arxiv.org/abs/2603.25051v1)
- PDF: [下载链接](https://arxiv.org/pdf/2603.25051v1)
- 作者: Filip Dobranić, Tina Munda, Oliver Pejić, Vojko Gorjanc, Uroš Šmajdek, David Bordon, Jakob Lenardič, Tjaša Konovšek, Kristina Pahor de Maiti Tekavčič, Ciril Bohak, Darja Fišer
- 发布时间: 2026-03-26T05:38:30Z
- 分类: cs.CL
- 相关性评分: 16
- 主题标签: 历史文档分析、OCR降质文本处理、LLM情感分析、主题建模、实体图可视化

**中文摘要**

> 本研究对斯洛文尼亚历史报纸《Slovenec》和《Slovenski narod》进行计算分析，结合主题建模、基于大语言模型（LLM）的方面级情感分析、实体图可视化和定性话语分析，探讨20世纪之交公共话语中集体身份、政治取向和国家归属的呈现。使用BERTopic识别主要主题模式，显示两报共享关切和意识形态差异，反映其保守-天主教和自由-进步取向。评估四个指令跟随LLM在OCR降质历史斯洛文尼亚语中的目标情感分类，选择斯洛文尼亚适配的GaMS3-12B-Instruct模型作为大规模应用最合适模型，同时记录重要局限，特别是中性情感表现优于积极或消极情感。模型应用于数据集规模，揭示集体身份描绘的显著变化，一些群体主要出现在中性描述语境，其他更常出现在评价性或冲突相关话语。创建NER图探索集体身份与地点关系，应用混合方法分析命名实体图，结合定量网络分析和批判话语分析。

**核心创新概述**

> 将LLM应用于OCR降质历史斯洛文尼亚语文本的方面级情感分析，结合主题建模和实体图可视化进行多方法历史话语分析，评估并选择适配LLM模型，揭示历史报纸中集体身份的动态呈现。

**创新点拆解**

- 使用BERTopic进行主题建模识别历史报纸意识形态差异
- 评估多个指令跟随LLM在OCR降质历史语言中的情感分类性能
- 应用GaMS3-12B-Instruct模型进行大规模方面级情感分析
- 结合NER图和混合方法分析集体身份与地点关系

**当前局限**

> LLM在OCR降质历史斯洛文尼亚语中中性情感分类表现优于积极或消极情感，可能影响情感分析的全面性；模型依赖特定语言适配，泛化能力有限。

**后续可改进方向**

- 开发更鲁棒的LLM情感分类方法以处理OCR降质历史文本中的情感不平衡
- 扩展多语言适配以提升跨语言历史文档分析能力
- 结合更细粒度OCR后处理技术减少文本降质对分析的影响

**工程启发**

> 高，为历史文档OCR后的大规模情感分析和话语分析提供实用框架，适配特定语言模型可提升分析准确性。

**为什么值得关注**

> 直接涉及OCR降质历史文本的LLM应用，关注文档解析后的情感和实体分析，与OCR技术下游任务紧密相关。

**原始摘要**

This study presents a computational analysis of the Slovene historical newspapers \textit{Slovenec}
and \textit{Slovenski narod} from the sPeriodika corpus, combining topic modelling, large language
model (LLM)-based aspect-level sentiment analysis, entity-graph visualisation, and qualitative
discourse analysis to examine how collective identities, political orientations, and national
belonging were represented in public discourse at the turn of the twentieth century. Using BERTopic,
we identify major thematic patterns and show both shared concerns and clear ideological differences
between the two newspapers, reflecting their conservative-Catholic and liberal-progressive
orientations. We further evaluate four instruction-following LLMs for targeted sentiment
classification in OCR-degraded historical Slovene and select the Slovene-adapted GaMS3-12B-Instruct
model as the most suitable for large-scale application, while also documenting important
limitations, particularly its stronger performance on neutral sentiment than on positive or negative
sentiment. Applied at dataset scale, the model reveals meaningful variation in the portrayal of
collective identities, with some groups appearing predominantly in neutral descriptive contexts and
others more often in evaluative or conflict-related discourse. We then create NER graphs to explore
the relationships between collective identities and places. We apply a mixed methods approach to
analyse the named entity graphs, combining quantitative network analysis with critical discourse
analysis. The investigation focuses on the emergence and development of intertwined historical
political and socionomic identities. Overall, the study demonstrates the value of combining scalable
computational methods with critical interpretation to support digital humanities research on noisy
historical newspaper data.

---

### 2. Pixelis: Reasoning in Pixels, from Seeing to Acting

- arXiv: [2603.25091v1](https://arxiv.org/abs/2603.25091v1)
- PDF: [下载链接](https://arxiv.org/pdf/2603.25091v1)
- 作者: Yunpeng Zhou
- 发布时间: 2026-03-26T06:57:00Z
- 分类: cs.CV, cs.AI
- 相关性评分: 12
- 主题标签: 像素空间代理、主动视觉学习、OCR集成、测试时强化学习、视觉语言系统

**中文摘要**

> 大多数视觉语言系统是被动观察者：描述像素、不行动、无法在分布偏移下安全改进。这种被动性限制可泛化、物理基础的视觉智能。通过行动而非静态描述学习，对超越策划数据至关重要。提出Pixelis，一个像素空间代理，直接通过紧凑可执行操作集（缩放/裁剪、分割、跟踪、OCR、时间定位）在图像和视频上操作，并从其后果中学习。Pixelis训练分三阶段：（1）监督微调从思维链-行动轨迹学习像素工具语法，使用掩码模仿损失加权操作/参数令牌和辅助头以稳定像素基础参数；（2）好奇心-一致性奖励微调优化双驱动目标，结合预测误差好奇心和相邻步骤一致性及温和效率先验，在KL锚点下产生短、有效、结构化工具链；（3）像素测试时RL执行无标签适应，通过检索邻居、对完整轨迹而非答案投票，并更新向短、高保真示例，同时使用KL到EMA安全控制约束漂移。在六个公共图像和视频基准上，Pixelis实现一致改进：平均相对增益比相同8B基线高+4.08%（在VSI-Bench上峰值+6.03%），计算为（我们的-基线）/基线，同时产生更短、可审计工具链并在测试时学习中保持走廊内KL。在像素内行动，而非抽象...

**核心创新概述**

> 提出Pixelis像素空间代理，通过可执行操作（包括OCR）在像素级别直接行动和学习，结合监督微调、奖励微调和测试时RL的三阶段训练范式，实现视觉任务的主动改进和泛化。

**创新点拆解**

- 设计像素空间代理直接操作图像/视频，集成OCR等可执行操作
- 三阶段训练范式：监督微调、好奇心-一致性奖励微调、测试时RL
- 使用掩码模仿损失和辅助头稳定像素基础参数学习
- 测试时RL结合邻居检索和轨迹投票实现无标签适应

**当前局限**

> 训练复杂度高，依赖多阶段优化；可执行操作集可能有限，需扩展以处理更复杂视觉任务；测试时RL的安全控制可能增加计算开销。

**后续可改进方向**

- 扩展可执行操作集以支持更广泛OCR和视觉任务
- 简化训练流程降低计算成本
- 增强测试时RL的泛化能力以减少对特定基准的依赖

**工程启发**

> 中高，为主动视觉系统提供新框架，但训练和部署可能较复杂，适用于需要动态OCR和视觉分析的场景。

**为什么值得关注**

> 集成OCR作为可执行操作，关注像素级别行动和学习，与OCR在动态视觉环境中的应用相关。

**原始摘要**

Most vision-language systems are static observers: they describe pixels, do not act, and cannot
safely improve under shift. This passivity limits generalizable, physically grounded visual
intelligence. Learning through action, not static description, is essential beyond curated data. We
present Pixelis, a pixel-space agent that operates directly on images and videos via a compact set
of executable operations (zoom/crop, segment, track, OCR, temporal localization) and learns from its
consequences. Pixelis trains in three phases: (1) Supervised Fine-Tuning learns a pixel-tool grammar
from Chain-of-Thought-Action traces with a masked imitation loss that upweights operation/argument
tokens and auxiliary heads to stabilize pixel-grounded arguments; (2) Curiosity-Coherence Reward
Fine-Tuning optimizes a dual-drive objective marrying prediction-error curiosity with adjacent-step
coherence and a mild efficiency prior under a KL anchor, yielding short, valid, structured
toolchains; (3) Pixel Test-Time RL performs label-free adaptation by retrieving neighbors, voting
over complete trajectories rather than answers, and updating toward short, high-fidelity exemplars
while constraining drift with a KL-to-EMA safety control. Across six public image and video
benchmarks, Pixelis yields consistent improvements: the average relative gain is +4.08% over the
same 8B baseline (peaking at +6.03% on VSI-Bench), computed as (ours-baseline)/baseline, while
producing shorter, auditable toolchains and maintaining in-corridor KL during test-time learning.
Acting within pixels, rather than abstract tokens, grounds multimodal perception in the physical
world, linking visual reasoning with actionable outcomes, and enables embodied adaptation without
external feedback.

---

### 3. ET-SAM: Efficient Point Prompt Prediction in SAM for Unified Scene Text Detection and Layout Analysis

- arXiv: [2603.25168v1](https://arxiv.org/abs/2603.25168v1)
- PDF: [下载链接](https://arxiv.org/pdf/2603.25168v1)
- 作者: Xike Zhang, Maoyuan Ye, Juhua Liu, Bo Du
- 发布时间: 2026-03-26T08:37:32Z
- 分类: cs.CV
- 相关性评分: 11
- 主题标签: 场景文本检测、布局分析、SAM优化、高效推理、异构数据训练

**中文摘要**

> 先前基于Segment Anything Model（SAM）的工作在统一场景文本检测和布局分析中取得有希望性能。然而，典型依赖像素级文本分割采样数千前景点作为提示导致不满意推理延迟和有限数据利用。为解决上述问题，提出ET-SAM，一个基于SAM的高效框架，具有两个解码器用于统一场景文本检测和布局分析。技术上，定制轻量级点解码器产生词热图以实现少量前景点，从而消除过多点提示并加速推理。无需依赖像素级分割，进一步设计联合训练策略以利用具有异构文本级标注的现有数据。具体地，将多级、仅词级和仅行级标注的数据集并行组合为统一训练集。对这些数据集，在点解码器和分层掩码解码器中引入三组对应可学习任务提示以缓解跨数据集差异。广泛实验表明，相比先前SAM-based架构，ET-SAM在HierText上实现约3倍推理加速同时获得竞争性能，并在Total-Text、CTW1500和ICDAR15上平均提升11.0% F-score。

**核心创新概述**

> 提出ET-SAM高效框架，通过轻量级点解码器减少点提示数量加速推理，并设计联合训练策略整合异构标注数据集，提升统一场景文本检测和布局分析的效率和性能。

**创新点拆解**

- 定制轻量级点解码器生成词热图以减少点提示，加速推理
- 设计联合训练策略整合多级、词级和行级标注数据集
- 引入可学习任务提示缓解跨数据集差异
- 在SAM基础上实现高效文本检测和布局分析

**当前局限**

> 框架可能依赖特定数据集标注类型，泛化到新标注格式需调整；轻量级解码器设计可能牺牲一定精度以换取速度。

**后续可改进方向**

- 扩展联合训练策略以支持更多样化标注类型
- 优化点解码器设计平衡速度与精度
- 探索自适应提示机制以提升跨数据集泛化能力

**工程启发**

> 高，显著提升推理速度并整合异构数据，适用于实时或大规模场景文本分析应用。

**为什么值得关注**

> 直接针对场景文本检测和布局分析，优化SAM-based方法的效率和数据利用，与OCR核心任务紧密相关。

**原始摘要**

Previous works based on Segment Anything Model (SAM) have achieved promising performance in unified
scene text detection and layout analysis. However, the typical reliance on pixel-level text
segmentation for sampling thousands of foreground points as prompts leads to unsatisfied inference
latency and limited data utilization. To address above issues, we propose ET-SAM, an Efficient
framework with two decoders for unified scene Text detection and layout analysis based on SAM.
Technically, we customize a lightweight point decoder that produces word heatmaps for achieving a
few foreground points, thereby eliminating excessive point prompts and accelerating inference.
Without the dependence on pixel-level segmentation, we further design a joint training strategy to
leverage existing data with heterogeneous text-level annotations. Specifically, the datasets with
multi-level, word-level only, and line-level only annotations are combined in parallel as a unified
training set. For these datasets, we introduce three corresponding sets of learnable task prompts in
both the point decoder and hierarchical mask decoder to mitigate discrepancies across
datasets.Extensive experiments demonstrate that, compared to the previous SAM-based architecture,
ET-SAM achieves about 3$\times$ inference acceleration while obtaining competitive performance on
HierText, and improves an average of 11.0% F-score on Total-Text, CTW1500, and ICDAR15.

---
