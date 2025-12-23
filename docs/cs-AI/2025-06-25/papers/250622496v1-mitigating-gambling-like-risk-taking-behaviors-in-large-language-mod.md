---
layout: default
title: Mitigating Gambling-Like Risk-Taking Behaviors in Large Language Models: A Behavioral Economics Approach to AI Safety
---

# Mitigating Gambling-Like Risk-Taking Behaviors in Large Language Models: A Behavioral Economics Approach to AI Safety

<div class="paper-toolbar">
  <a href="https://arxiv.org/abs/2506.22496" class="toolbar-btn" target="_blank">📄 arXiv: 2506.22496v1</a>
  <a href="https://arxiv.org/pdf/2506.22496.pdf" class="toolbar-btn" target="_blank">📥 PDF</a>
  <button class="toolbar-btn favorite-btn" data-arxiv-id="2506.22496v1" data-paper-url="__CURRENT_PAGE__" onclick="toggleFavorite(this, '2506.22496v1', 'Mitigating Gambling-Like Risk-Taking Behaviors in Large Language Models: A Behavioral Economics Approach to AI Safety')" title="添加到收藏夹">☆ 收藏</button>
  <button class="toolbar-btn" onclick="copyLinkToClipboard(this)">🔗 分享</button>
</div>


**作者**: Y. Du

**分类**: cs.CY, cs.AI, cs.CL

**发布日期**: 2025-06-25

**备注**: 7 pages

---

## 💡 一句话要点

**提出风险意识响应生成框架以缓解大型语言模型的赌博行为**

🎯 **匹配领域**: **支柱九：具身大模型 (Embodied Foundation Models)**

**关键词**: `大型语言模型` `风险管理` `行为经济学` `前景理论` `AI安全` `决策支持` `损失厌恶` `不确定性校准`

## 📋 核心要点

1. 现有大型语言模型在决策过程中表现出类似赌博的风险行为，导致输出的准确性和可靠性下降。
2. 本文提出风险意识响应生成框架，通过引入行为经济学的理论，设计风险校准训练和损失厌恶机制来缓解这些问题。
3. 实验结果表明，模型的过度自信偏差降低了18.7%，追损倾向降低了24.3%，并在多种场景中实现了风险校准的改善。

## 📝 摘要（中文）

大型语言模型（LLMs）表现出与赌博心理学相似的系统性风险行为，包括过度自信偏差、追损倾向和概率误判。基于行为经济学和前景理论，本文识别并形式化这些“赌博-like”模式，模型在追求高回报输出时牺牲准确性，并在错误后表现出逐步加剧的风险行为。我们提出风险意识响应生成（RARG）框架，结合赌博研究的见解，通过风险校准训练、损失厌恶机制和不确定性意识决策来解决这些行为偏差。实验结果显示，赌博行为显著减少：过度自信偏差降低18.7%，追损倾向降低24.3%，并在多种场景中改善风险校准。

## 🔬 方法详解

**问题定义**：本文旨在解决大型语言模型中存在的赌博-like风险行为，这些行为导致模型在决策时过度自信、追求高回报而牺牲准确性。现有方法未能有效识别和校正这些行为，影响了模型的可靠性和安全性。

**核心思路**：论文提出的风险意识响应生成框架（RARG）通过结合行为经济学的理论，特别是前景理论，设计了一种新的训练机制，旨在通过风险校准和损失厌恶来减少模型的赌博行为。

**技术框架**：RARG框架包含几个主要模块：风险校准训练模块、损失厌恶机制模块和不确定性意识决策模块。通过这些模块，模型能够在生成响应时更好地评估和管理风险。

**关键创新**：该研究的主要创新在于首次系统性地将赌博心理学的理论应用于AI系统，提出了一种新的评估范式，并通过实验验证了其有效性。与现有方法相比，RARG框架更关注模型在决策过程中的风险管理。

**关键设计**：在模型训练中，采用了风险校准的损失函数，设计了特定的网络结构以增强模型对不确定性的感知，并通过模拟赌博任务（如爱荷华赌博任务）来评估模型的决策能力。

## 📊 实验亮点

实验结果显示，采用RARG框架后，模型的过度自信偏差降低了18.7%，追损倾向降低了24.3%。在多种场景下，模型的风险校准能力显著提升，表明该方法在缓解赌博-like行为方面的有效性。

## 🎯 应用场景

该研究的潜在应用领域包括金融决策支持系统、自动化客服和智能推荐系统等。通过减少模型的赌博行为，可以提高这些系统的决策准确性和用户信任度，进而提升实际应用的安全性和有效性。

## 📄 摘要（原文）

> Large Language Models (LLMs) exhibit systematic risk-taking behaviors analogous to those observed in gambling psychology, including overconfidence bias, loss-chasing tendencies, and probability misjudgment. Drawing from behavioral economics and prospect theory, we identify and formalize these "gambling-like" patterns where models sacrifice accuracy for high-reward outputs, exhibit escalating risk-taking after errors, and systematically miscalibrate uncertainty. We propose the Risk-Aware Response Generation (RARG) framework, incorporating insights from gambling research to address these behavioral biases through risk-calibrated training, loss-aversion mechanisms, and uncertainty-aware decision making. Our approach introduces novel evaluation paradigms based on established gambling psychology experiments, including AI adaptations of the Iowa Gambling Task and probability learning assessments. Experimental results demonstrate measurable reductions in gambling-like behaviors: 18.7\% decrease in overconfidence bias, 24.3\% reduction in loss-chasing tendencies, and improved risk calibration across diverse scenarios. This work establishes the first systematic framework for understanding and mitigating gambling psychology patterns in AI systems.

