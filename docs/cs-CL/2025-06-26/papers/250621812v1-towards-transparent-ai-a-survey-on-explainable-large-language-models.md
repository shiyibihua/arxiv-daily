---
layout: default
title: Towards Transparent AI: A Survey on Explainable Large Language Models
---

# Towards Transparent AI: A Survey on Explainable Large Language Models

<div class="paper-toolbar">
  <a href="https://arxiv.org/abs/2506.21812" class="toolbar-btn" target="_blank">📄 arXiv: 2506.21812v1</a>
  <a href="https://arxiv.org/pdf/2506.21812.pdf" class="toolbar-btn" target="_blank">📥 PDF</a>
  <button class="toolbar-btn favorite-btn" data-arxiv-id="2506.21812v1" data-paper-url="__CURRENT_PAGE__" onclick="toggleFavorite(this, '2506.21812v1', 'Towards Transparent AI: A Survey on Explainable Large Language Models')" title="添加到收藏夹">☆ 收藏</button>
  <button class="toolbar-btn" onclick="copyLinkToClipboard(this)">🔗 分享</button>
</div>


**作者**: Avash Palikhe, Zhenyu Yu, Zichong Wang, Wenbin Zhang

**分类**: cs.CL, cs.CV

**发布日期**: 2025-06-26

---

## 💡 一句话要点

**综述可解释大型语言模型的研究进展与挑战**

🎯 **匹配领域**: **支柱九：具身大模型 (Embodied Foundation Models)**

**关键词**: `可解释人工智能` `大型语言模型` `变换器架构` `决策透明性` `高风险应用`

## 📋 核心要点

1. 现有大型语言模型在决策过程的可解释性方面存在显著不足，限制了其在高风险领域的应用。
2. 本文通过分类不同的可解释人工智能方法，系统性地评估了基于变换器架构的可解释性技术。
3. 研究探讨了这些可解释性技术在实际应用中的效果，并指出了未来研究的方向和挑战。

## 📝 摘要（中文）

大型语言模型（LLMs）在人工智能领域发挥了重要作用，但其决策过程往往难以解释，导致其成为“黑箱”，这在高风险领域应用中尤为突出。为了解决这一问题，研究者们开发了多种可解释人工智能（XAI）方法，旨在为LLMs提供人类可理解的解释。然而，目前对这些方法的系统性理解仍然有限。本文综述了基于LLMs的不同变换器架构（编码器、解码器和编码器-解码器模型）分类的可解释性技术，并探讨了这些技术在实际应用中的评估和利用，最后讨论了可用资源、研究挑战及未来方向，以推动透明和负责任的LLMs的发展。

## 🔬 方法详解

**问题定义**：本文旨在解决大型语言模型的可解释性不足问题，现有方法在高风险领域的应用受到限制，缺乏系统的理解和评估。

**核心思路**：通过对可解释人工智能方法进行分类，基于不同的变换器架构（编码器、解码器、编码器-解码器），提供人类可理解的解释，增强模型透明度。

**技术框架**：整体架构包括对不同XAI方法的分类、评估标准的制定以及在实际应用中的案例分析，主要模块包括方法分类、评估指标和应用实例。

**关键创新**：本文的创新在于系统性地分类和评估可解释性技术，填补了现有文献对LLMs可解释性方法的理解空白，提供了一个全面的框架。

**关键设计**：在方法分类中，考虑了不同变换器架构的特点，设计了相应的评估标准，确保能够有效衡量可解释性技术的实际效果。具体参数设置和损失函数的选择尚未详细披露，待进一步研究。

## 📊 实验亮点

研究表明，通过分类和评估不同的可解释性技术，能够显著提高大型语言模型的透明度和可解释性。具体性能数据尚未披露，但研究指出，采用这些方法后，模型在高风险领域的应用潜力得到了提升，用户信任度也有所增加。

## 🎯 应用场景

该研究的潜在应用领域包括医疗、金融和法律等高风险行业，在这些领域中，模型的可解释性至关重要。通过提高大型语言模型的透明度，能够增强用户信任，促进其在实际应用中的广泛采用，推动智能决策的进步。

## 📄 摘要（原文）

> Large Language Models (LLMs) have played a pivotal role in advancing Artificial Intelligence (AI). However, despite their achievements, LLMs often struggle to explain their decision-making processes, making them a 'black box' and presenting a substantial challenge to explainability. This lack of transparency poses a significant obstacle to the adoption of LLMs in high-stakes domain applications, where interpretability is particularly essential. To overcome these limitations, researchers have developed various explainable artificial intelligence (XAI) methods that provide human-interpretable explanations for LLMs. However, a systematic understanding of these methods remains limited. To address this gap, this survey provides a comprehensive review of explainability techniques by categorizing XAI methods based on the underlying transformer architectures of LLMs: encoder-only, decoder-only, and encoder-decoder models. Then these techniques are examined in terms of their evaluation for assessing explainability, and the survey further explores how these explanations are leveraged in practical applications. Finally, it discusses available resources, ongoing research challenges, and future directions, aiming to guide continued efforts toward developing transparent and responsible LLMs.

