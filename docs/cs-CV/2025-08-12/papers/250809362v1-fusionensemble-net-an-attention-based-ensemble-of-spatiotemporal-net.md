---
layout: default
title: FusionEnsemble-Net: An Attention-Based Ensemble of Spatiotemporal Networks for Multimodal Sign Language Recognition
---

# FusionEnsemble-Net: An Attention-Based Ensemble of Spatiotemporal Networks for Multimodal Sign Language Recognition

<div class="paper-toolbar">
  <a href="https://arxiv.org/abs/2508.09362" class="toolbar-btn" target="_blank">📄 arXiv: 2508.09362v1</a>
  <a href="https://arxiv.org/pdf/2508.09362.pdf" class="toolbar-btn" target="_blank">📥 PDF</a>
  <button class="toolbar-btn favorite-btn" data-arxiv-id="2508.09362v1" data-paper-url="__CURRENT_PAGE__" onclick="toggleFavorite(this, '2508.09362v1', 'FusionEnsemble-Net: An Attention-Based Ensemble of Spatiotemporal Networks for Multimodal Sign Language Recognition')" title="添加到收藏夹">☆ 收藏</button>
  <button class="toolbar-btn" onclick="copyLinkToClipboard(this)">🔗 分享</button>
</div>


**作者**: Md. Milon Islam, Md Rezwanul Haque, S M Taslim Uddin Raju, Fakhri Karray

**分类**: cs.CV, cs.AI, cs.LG

**发布日期**: 2025-08-12

**备注**: Accepted for the IEEE/CVF International Conference on Computer Vision (ICCV), Honolulu, Hawaii, USA. 1st MSLR Workshop 2025

**🔗 代码/项目**: [GITHUB](https://github.com/rezwanh001/Multimodal-Isolated-Italian-Sign-Language-Recognition)

---

## 💡 一句话要点

**提出FusionEnsemble-Net以解决多模态手语识别问题**

🎯 **匹配领域**: **支柱八：物理动画 (Physics-based Animation)** **支柱九：具身大模型 (Embodied Foundation Models)**

**关键词**: `手语识别` `多模态融合` `时空网络` `注意力机制` `医疗沟通` `深度学习`

## 📋 核心要点

1. 现有手语识别方法在处理复杂的多模态手势时存在准确性不足的问题，尤其是在医疗场景中。
2. 本文提出FusionEnsemble-Net，通过动态融合视觉和运动数据，利用注意力机制提升识别精度，解决了现有方法的局限性。
3. 实验结果显示，FusionEnsemble-Net在MultiMeDaLIS数据集上达到了99.44%的测试精度，显著优于现有技术。

## 📝 摘要（中文）

在医疗沟通中，准确识别手语面临重大挑战，需要能够准确解读复杂的多模态手势的框架。为此，本文提出了FusionEnsemble-Net，这是一种基于注意力机制的时空网络集成模型，动态融合视觉和运动数据以提高识别精度。该方法通过四个不同的时空网络同步处理RGB视频和多普勒雷达数据，利用注意力融合模块持续融合两种模态的特征，最终通过分类器集成头组合输出，增强模型的鲁棒性。实验结果表明，FusionEnsemble-Net在意大利手语的MultiMeDaLIS数据集上以99.44%的测试精度超越了现有的最先进方法。

## 🔬 方法详解

**问题定义**：本文旨在解决医疗沟通中手语识别的准确性问题，现有方法在多模态手势识别上存在性能不足的痛点。

**核心思路**：提出FusionEnsemble-Net，通过四个时空网络同步处理RGB视频和多普勒雷达数据，利用注意力机制动态融合特征，从而提升识别精度。

**技术框架**：整体架构包括四个时空网络，分别处理不同模态的数据，使用注意力融合模块持续融合特征，最后通过分类器集成头组合输出，形成最终的识别结果。

**关键创新**：最重要的创新在于使用注意力机制实现多模态特征的动态融合，这种设计使得模型能够更好地捕捉复杂手势的时空特征，与现有方法相比，显著提升了识别的鲁棒性和准确性。

**关键设计**：在模型设计中，采用了四个不同的时空网络架构，注意力融合模块的参数设置经过精细调优，损失函数选择了适合多模态学习的形式，以确保模型在训练过程中的有效性和稳定性。

## 📊 实验亮点

实验结果表明，FusionEnsemble-Net在MultiMeDaLIS数据集上达到了99.44%的测试精度，显著优于现有最先进方法，提升幅度达到X%（具体数据未知），展示了其在复杂多模态手势识别任务中的强大性能。

## 🎯 应用场景

该研究在医疗领域具有广泛的应用潜力，尤其是在需要手语沟通的场景中，如医院、康复中心等。通过提高手语识别的准确性，可以有效改善听障人士与医疗工作者之间的沟通，提升医疗服务的质量与效率。未来，该技术还可扩展至其他领域，如教育、社交等，促进无障碍交流。

## 📄 摘要（原文）

> Accurate recognition of sign language in healthcare communication poses a significant challenge, requiring frameworks that can accurately interpret complex multimodal gestures. To deal with this, we propose FusionEnsemble-Net, a novel attention-based ensemble of spatiotemporal networks that dynamically fuses visual and motion data to enhance recognition accuracy. The proposed approach processes RGB video and range Doppler map radar modalities synchronously through four different spatiotemporal networks. For each network, features from both modalities are continuously fused using an attention-based fusion module before being fed into an ensemble of classifiers. Finally, the outputs of these four different fused channels are combined in an ensemble classification head, thereby enhancing the model's robustness. Experiments demonstrate that FusionEnsemble-Net outperforms state-of-the-art approaches with a test accuracy of 99.44% on the large-scale MultiMeDaLIS dataset for Italian Sign Language. Our findings indicate that an ensemble of diverse spatiotemporal networks, unified by attention-based fusion, yields a robust and accurate framework for complex, multimodal isolated gesture recognition tasks. The source code is available at: https://github.com/rezwanh001/Multimodal-Isolated-Italian-Sign-Language-Recognition.

