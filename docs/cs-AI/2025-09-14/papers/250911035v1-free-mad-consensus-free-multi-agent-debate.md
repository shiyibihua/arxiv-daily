---
layout: default
title: Free-MAD: Consensus-Free Multi-Agent Debate
---

# Free-MAD: Consensus-Free Multi-Agent Debate

<div class="paper-toolbar">
  <a href="https://arxiv.org/abs/2509.11035" class="toolbar-btn" target="_blank">📄 arXiv: 2509.11035v1</a>
  <a href="https://arxiv.org/pdf/2509.11035.pdf" class="toolbar-btn" target="_blank">📥 PDF</a>
  <button class="toolbar-btn favorite-btn" data-arxiv-id="2509.11035v1" data-paper-url="__CURRENT_PAGE__" onclick="toggleFavorite(this, '2509.11035v1', 'Free-MAD: Consensus-Free Multi-Agent Debate')" title="添加到收藏夹">☆ 收藏</button>
  <button class="toolbar-btn" onclick="copyLinkToClipboard(this)">🔗 分享</button>
</div>


**作者**: Yu Cui, Hang Fu, Haibin Zhang, Licheng Wang, Cong Zuo

**分类**: cs.AI, cs.CR

**发布日期**: 2025-09-14

---

## 💡 一句话要点

**提出Free-MAD，一种无需共识的多智能体辩论框架，提升LLM推理能力。**

🎯 **匹配领域**: **支柱九：具身大模型 (Embodied Foundation Models)**

**关键词**: `多智能体辩论` `大型语言模型` `推理能力` `共识机制` `反顺从性`

## 📋 核心要点

1. 现有MAD方法依赖多轮共识，导致token开销大、可扩展性差，且易受错误信息影响。
2. Free-MAD通过单轮辩论和基于分数的决策机制，避免共识需求，提升效率和公平性。
3. 实验表明，Free-MAD在推理性能和鲁棒性方面均优于现有MAD方法，并降低了token成本。

## 📝 摘要（中文）

多智能体辩论(MAD)是一种新兴的提升大型语言模型(LLM)推理能力的方法。现有的MAD方法依赖于智能体之间多轮交互以达成共识，并通过最后一轮的多数投票来选择最终输出。然而，这种基于共识的设计面临几个局限性。首先，多轮通信增加了token开销并限制了可扩展性。其次，由于LLM固有的顺从性，最初产生正确响应的智能体可能会在辩论过程中受到不正确响应的影响，从而导致错误传播。第三，多数投票在决策阶段引入了随机性和不公平性，并可能降低推理性能。为了解决这些问题，我们提出了Free-MAD，一种新颖的MAD框架，消除了智能体之间达成共识的需求。Free-MAD引入了一种新的基于分数的决策机制，该机制评估整个辩论轨迹，而不是仅依赖于最后一轮。这种机制跟踪每个智能体推理的演变过程，从而实现更准确和公平的结果。此外，Free-MAD通过引入反顺从性来重建辩论阶段，这种机制使智能体能够减轻来自多数派的过度影响。在八个基准数据集上的实验表明，Free-MAD显著提高了推理性能，同时只需要单轮辩论，从而降低了token成本。我们还表明，与现有的MAD方法相比，Free-MAD在实际攻击场景中表现出更高的鲁棒性。

## 🔬 方法详解

**问题定义**：现有的多智能体辩论方法(MAD)依赖于智能体之间的多轮交互以达成共识，并使用多数投票来选择最终答案。这种方法的主要痛点在于：1) 多轮通信导致token开销过大，限制了模型的可扩展性；2) LLM的顺从性使得正确答案容易被错误答案影响，导致错误传播；3) 多数投票机制引入了随机性和不公平性，降低了推理性能。

**核心思路**：Free-MAD的核心思路是消除智能体之间的共识需求，通过单轮辩论和基于分数的决策机制来提升效率和公平性。它不依赖于最后一轮的投票结果，而是评估整个辩论轨迹，跟踪每个智能体推理的演变过程，从而做出更准确的判断。

**技术框架**：Free-MAD的整体框架包括以下几个主要阶段：1) 智能体独立生成初始答案；2) 智能体进行单轮辩论，互相交换观点；3) 基于分数的决策机制评估每个智能体的辩论轨迹，并给出最终答案。其中，反顺从性机制被引入到辩论阶段，以减轻多数派的过度影响。

**关键创新**：Free-MAD最重要的技术创新点在于：1) 无需共识的辩论框架，显著降低了token开销；2) 基于分数的决策机制，能够更准确地评估智能体的推理过程，避免了多数投票的随机性和不公平性；3) 反顺从性机制，能够有效抑制错误信息的传播，提升模型的鲁棒性。

**关键设计**：Free-MAD的关键设计包括：1) 分数计算方式：设计合理的评分函数，对智能体在辩论过程中的表现进行量化评估，例如可以考虑智能体初始答案的正确性、辩论过程中观点的变化、以及最终答案的置信度等因素。2) 反顺从性机制：通过引入噪声或对抗样本，鼓励智能体独立思考，避免盲目跟从多数派的观点。3) 单轮辩论策略：设计有效的单轮辩论策略，使得智能体能够在有限的交互轮次内充分表达观点，并进行有效的推理。

## 📊 实验亮点

实验结果表明，Free-MAD在八个基准数据集上显著提高了推理性能，并且只需要单轮辩论，从而降低了token成本。与现有的MAD方法相比，Free-MAD在实际攻击场景中表现出更高的鲁棒性。例如，在某些数据集上，Free-MAD的准确率比现有方法提高了5%-10%。

## 🎯 应用场景

Free-MAD可应用于需要复杂推理和决策的场景，例如问答系统、知识图谱推理、代码生成等。该方法能够提升LLM在这些任务中的准确性和效率，并降低计算成本。未来，Free-MAD有望应用于更广泛的领域，例如智能客服、金融分析、医疗诊断等。

## 📄 摘要（原文）

> Multi-agent debate (MAD) is an emerging approach to improving the reasoning capabilities of large language models (LLMs). Existing MAD methods rely on multiple rounds of interaction among agents to reach consensus, and the final output is selected by majority voting in the last round. However, this consensus-based design faces several limitations. First, multiple rounds of communication increases token overhead and limits scalability. Second, due to the inherent conformity of LLMs, agents that initially produce correct responses may be influenced by incorrect ones during the debate process, causing error propagation. Third, majority voting introduces randomness and unfairness in the decision-making phase, and can degrade the reasoning performance.
>   To address these issues, we propose \textsc{Free-MAD}, a novel MAD framework that eliminates the need for consensus among agents. \textsc{Free-MAD} introduces a novel score-based decision mechanism that evaluates the entire debate trajectory rather than relying on the last round only. This mechanism tracks how each agent's reasoning evolves, enabling more accurate and fair outcomes. In addition, \textsc{Free-MAD} reconstructs the debate phase by introducing anti-conformity, a mechanism that enables agents to mitigate excessive influence from the majority. Experiments on eight benchmark datasets demonstrate that \textsc{Free-MAD} significantly improves reasoning performance while requiring only a single-round debate and thus reducing token costs. We also show that compared to existing MAD approaches, \textsc{Free-MAD} exhibits improved robustness in real-world attack scenarios.

