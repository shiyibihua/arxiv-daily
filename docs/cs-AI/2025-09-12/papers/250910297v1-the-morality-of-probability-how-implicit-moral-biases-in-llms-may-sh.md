---
layout: default
title: The Morality of Probability: How Implicit Moral Biases in LLMs May Shape the Future of Human-AI Symbiosis
---

# The Morality of Probability: How Implicit Moral Biases in LLMs May Shape the Future of Human-AI Symbiosis

<div class="paper-toolbar">
  <a href="https://arxiv.org/abs/2509.10297" class="toolbar-btn" target="_blank">📄 arXiv: 2509.10297v1</a>
  <a href="https://arxiv.org/pdf/2509.10297.pdf" class="toolbar-btn" target="_blank">📥 PDF</a>
  <button class="toolbar-btn favorite-btn" data-arxiv-id="2509.10297v1" data-paper-url="__CURRENT_PAGE__" onclick="toggleFavorite(this, '2509.10297v1', 'The Morality of Probability: How Implicit Moral Biases in LLMs May Shape the Future of Human-AI Symbiosis')" title="添加到收藏夹">☆ 收藏</button>
  <button class="toolbar-btn" onclick="copyLinkToClipboard(this)">🔗 分享</button>
</div>


**作者**: Eoin O'Doherty, Nicole Weinrauch, Andrew Talone, Uri Klempner, Xiaoyuan Yi, Xing Xie, Yi Zeng

**分类**: cs.AI

**发布日期**: 2025-09-12

**备注**: Work in progress

---

## 💡 一句话要点

**揭示LLM中隐含的道德偏见，探索人机共生的未来**

🎯 **匹配领域**: **支柱九：具身大模型 (Embodied Foundation Models)**

**关键词**: `大型语言模型` `道德偏见` `人机共生` `道德推理` `可解释性`

## 📋 核心要点

1. 现有AI系统在道德决策方面缺乏透明度，难以与人类道德价值观对齐，阻碍了人机共生。
2. 通过定量实验评估LLM在道德困境中的选择，揭示其隐含的道德偏见，并分析不同模型架构和文化背景的影响。
3. 实验表明，LLM普遍偏向关怀和美德价值观，而忽视自由主义选择，推理能力强的模型对上下文更敏感。

## 📝 摘要（中文）

本文探讨了人工智能系统在道德决策中如何优先考虑道德结果，以及这对于人机共生的前景有何启示。研究关注两个核心问题：(1) 最先进的大型语言模型(LLM)在面对道德困境时，隐含地偏向哪些道德价值观？(2) 模型架构、文化背景和可解释性的差异如何影响这些道德偏好？通过对六个LLM进行定量实验，对18个代表五种道德框架的困境中的结果进行排序和评分。研究发现了一致的价值偏见：关怀和美德价值观的结果被评为最具道德性，而自由主义选择则受到一致惩罚。具有推理能力的模型对上下文表现出更高的敏感性，并提供了更丰富的解释，而非推理模型则产生了更统一但模糊的判断。该研究在经验上、理论上和实践上都做出了贡献，强调了可解释性和文化意识作为指导人工智能走向透明、一致和共生未来的关键设计原则。

## 🔬 方法详解

**问题定义**：论文旨在解决大型语言模型（LLM）在面对道德困境时，其决策过程中隐含的道德偏见问题。现有方法缺乏对LLM道德价值观的系统性评估，难以理解其决策依据，导致潜在的伦理风险和人机协作障碍。

**核心思路**：论文的核心思路是通过设计一系列道德困境，让LLM在不同的道德框架下进行选择，并对选择结果进行排序和评分，从而量化LLM的道德偏好。通过比较不同架构、文化背景和可解释性的LLM，分析这些因素对道德偏见的影响。

**技术框架**：研究采用定量实验方法，主要包含以下几个阶段：
1. **道德困境设计**：构建包含18个道德困境的数据集，这些困境代表了五种不同的道德框架（例如，关怀、美德、自由主义等）。
2. **LLM选择与排序**：选取六个具有代表性的LLM，要求它们对每个困境中的不同结果进行排序和评分。
3. **结果分析**：分析LLM的选择结果，量化其对不同道德价值观的偏好，并比较不同LLM之间的差异。
4. **可解释性分析**：对于具有推理能力的LLM，分析其提供的解释，理解其决策依据。

**关键创新**：该研究的关键创新在于：
1. **大规模的道德偏见评估**：首次对多个具有不同架构和文化背景的LLM进行了大规模的道德偏见评估。
2. **量化的道德偏好分析**：通过排序和评分的方式，量化了LLM对不同道德价值观的偏好。
3. **可解释性与道德偏见关联**：分析了可解释性对LLM道德决策的影响，揭示了可解释性在减少道德偏见中的作用。

**关键设计**：
1. **道德困境的多样性**：确保道德困境涵盖不同的道德框架，以全面评估LLM的道德偏好。
2. **LLM的选择**：选择具有代表性的LLM，包括不同架构（例如，Transformer、推理增强型模型）和文化背景（例如，西方、东方）的模型。
3. **评分标准**：设计合理的评分标准，以准确量化LLM对不同结果的偏好。
4. **统计分析方法**：采用合适的统计分析方法，例如方差分析、相关性分析，以分析LLM的选择结果。

## 📊 实验亮点

实验结果表明，所有模型都表现出对关怀和美德价值观的偏好，而对自由主义选择的惩罚。具有推理能力的模型对上下文更敏感，能提供更丰富的解释。该研究揭示了LLM中普遍存在的道德偏见，并强调了可解释性在减少偏见中的作用。

## 🎯 应用场景

该研究成果可应用于开发更符合人类道德价值观的人工智能系统，例如自动驾驶汽车、医疗诊断系统和金融风险评估系统。通过理解和纠正LLM中的道德偏见，可以提高AI系统的公平性、透明度和可靠性，促进人机协作。

## 📄 摘要（原文）

> Artificial intelligence (AI) is advancing at a pace that raises urgent questions about how to align machine decision-making with human moral values. This working paper investigates how leading AI systems prioritize moral outcomes and what this reveals about the prospects for human-AI symbiosis. We address two central questions: (1) What moral values do state-of-the-art large language models (LLMs) implicitly favour when confronted with dilemmas? (2) How do differences in model architecture, cultural origin, and explainability affect these moral preferences? To explore these questions, we conduct a quantitative experiment with six LLMs, ranking and scoring outcomes across 18 dilemmas representing five moral frameworks. Our findings uncover strikingly consistent value biases. Across all models, Care and Virtue values outcomes were rated most moral, while libertarian choices were consistently penalized. Reasoning-enabled models exhibited greater sensitivity to context and provided richer explanations, whereas non-reasoning models produced more uniform but opaque judgments. This research makes three contributions: (i) Empirically, it delivers a large-scale comparison of moral reasoning across culturally distinct LLMs; (ii) Theoretically, it links probabilistic model behaviour with underlying value encodings; (iii) Practically, it highlights the need for explainability and cultural awareness as critical design principles to guide AI toward a transparent, aligned, and symbiotic future.

