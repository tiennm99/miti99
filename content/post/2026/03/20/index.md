---
title: "Newsletter #92"
date: 2026-03-20
tags: ["AI-Assisted"]
categories: ["Newsletter"]
---

*Mời bạn thưởng thức Newsletter #92.*

## [Tôi đã trở nên giỏi xử lý sự cố như thế nào](https://tomasztomczyk.com/blog/2026/how-i-became-good-at-leading-incidents/)

Tomasz Tomczyk chia sẻ những bài học từ hơn 100 sự cố mà anh đã dẫn dắt trong suốt sự nghiệp, nhấn mạnh rằng quản lý sự cố không chỉ là kỹ năng kỹ thuật mà còn là tư duy phân tích và khả năng lãnh đạo dưới áp lực. Anh cho rằng mỗi sự cố là cơ hội để hiểu sâu hơn về hệ thống và xây dựng văn hóa học hỏi từ thất bại.

Để xử lý sự cố hiệu quả, bạn cần nắm vững quy trình triển khai và toàn bộ ngăn xếp công nghệ từ DNS đến tầng ứng dụng, đồng thời thiết lập hệ thống giám sát toàn diện. Khi xảy ra sự cố, hãy phân công điều tra theo từng chủ đề cụ thể, đưa ra quyết định dứt khoát khi cần vô hiệu hóa tính năng, và cung cấp thông tin cập nhật kịp thời cho các bên liên quan. Việc lập tài liệu các mẫu lỗi phổ biến vào runbook và thực hành qua các bài tập chaos engineering cũng giúp đội nhóm chuẩn bị tốt hơn cho các tình huống thực tế.

**Điểm chính:**
- Nắm vững quy trình triển khai và toàn bộ ngăn xếp công nghệ để nhanh chóng xác định nguyên nhân sự cố
- Đọc hiểu stack trace và sử dụng công cụ theo dõi lỗi như Sentry để điều tra sâu hơn
- Xây dựng văn hóa tâm lý an toàn để thất bại trở thành cơ hội học hỏi
- Phân công điều tra chiến lược và đưa ra quyết định dứt khoát trong thời điểm căng thẳng
- Lập tài liệu runbook và thực hành game day để chuẩn bị cho các sự cố thực tế

## [Decision Trees: Sức mạnh bất ngờ của các quy tắc quyết định lồng nhau](https://mlu-explain.github.io/decision-tree/)

Decision Tree (cây quyết định) là thuật toán học có giám sát được dùng cho cả bài toán phân loại lẫn hồi quy. Thuật toán hoạt động bằng cách phân chia dữ liệu đệ quy theo các quy tắc điều kiện, tạo ra cấu trúc cây trong đó mỗi lần phân chia nhằm tách biệt các nhóm dữ liệu hiệu quả nhất. Phương pháp huấn luyện cốt lõi là thuật toán ID3, chọn điểm phân chia bằng cách tối đa hóa information gain — tức là mức giảm entropy sau khi phân vùng dữ liệu.

Decision Tree có nhiều ưu điểm nổi bật: dễ diễn giải, huấn luyện nhanh, cần ít tiền xử lý dữ liệu và xử lý tốt các giá trị ngoại lệ. Tuy nhiên, nhược điểm lớn nhất là tính bất ổn định — chỉ một thay đổi nhỏ trong dữ liệu có thể khiến cấu trúc cây thay đổi hoàn toàn, dẫn đến hiện tượng overfitting. Để khắc phục, người ta thường dùng kỹ thuật pruning như giới hạn độ sâu tối đa hoặc đặt ngưỡng số lượng mẫu tối thiểu tại lá.

**Điểm chính:**
- Decision Tree phân chia dữ liệu đệ quy, chọn điểm phân chia dựa trên information gain và entropy
- Ưu điểm: dễ diễn giải, huấn luyện nhanh, ít cần tiền xử lý, chịu tốt giá trị ngoại lệ
- Nhược điểm lớn: bất ổn định cao, dễ bị overfitting khi dữ liệu thay đổi nhỏ
- Pruning (cắt tỉa cây) là kỹ thuật phổ biến để kiểm soát overfitting

## [Container không phải là ranh giới bảo mật](https://www.lucavall.in/blog/containers-are-not-a-security-boundary)

Luca Cavallin lập luận rằng container hóa tự bản thân không đảm bảo an toàn — container về bản chất chỉ là các tiến trình Linux với các lớp cô lập, không phải hệ thống tách biệt hoàn toàn. Chúng vẫn chia sẻ kernel của máy chủ, tạo ra bề mặt tấn công chung giữa các workload. Điều này có nghĩa là các mối đe dọa bảo mật truyền thống vẫn áp dụng đầy đủ cho môi trường container.

Bảo mật container hiệu quả đòi hỏi áp dụng các nguyên tắc cơ bản: đặc quyền tối thiểu, phòng thủ nhiều lớp và giảm thiểu bề mặt tấn công. Cụ thể, cần hạn chế syscall và capabilities ở cấp kernel, dùng cgroups để giới hạn tài nguyên, triển khai seccomp/AppArmor/SELinux để kiểm soát truy cập bắt buộc. Ngoài ra, bảo mật chuỗi cung ứng cũng quan trọng: dùng base image đáng tin cậy, ghim digest, quét lỗ hổng và kiểm soát admission. Với mã nguồn không đáng tin cậy, máy ảo vẫn cung cấp mức cô lập mạnh hơn container.

**Điểm chính:**
- Container chỉ là tiến trình Linux, chia sẻ kernel máy chủ — không phải ranh giới bảo mật thực sự
- Áp dụng nguyên tắc đặc quyền tối thiểu: chạy container không phải root, bỏ các capabilities không cần thiết
- Dùng seccomp, AppArmor, SELinux để kiểm soát truy cập ở cấp kernel
- Bảo vệ chuỗi cung ứng: base image đáng tin cậy, ghim digest, quét lỗ hổng định kỳ
- Máy ảo phù hợp hơn cho mã nguồn không đáng tin cậy; container phù hợp cho dịch vụ nội bộ đã kiểm soát

## [Bài ca ngợi bzip](https://purplesyringa.moe/blog/an-ode-to-bzip/)

Tác giả purplesyringa khám phá lý do tại sao bzip vẫn vượt trội so với các thuật toán nén hiện đại cho dữ liệu văn bản và mã nguồn, dù đã bị lãng quên. Qua thực nghiệm nén một codebase Lua 327 KB trong mod ComputerCraft, bzip2 đạt 63.727 byte — tốt hơn gzip, zstd, xz, brotli và lzip; trong khi bzip3 còn đạt 61.067 byte.

Ưu thế của bzip đến từ cách tiếp cận thuật toán khác biệt căn bản: thay vì dùng LZ77 dựa trên tham chiếu như phần lớn các công cụ nén phổ biến, bzip dùng BWT (Burrows-Wheeler Transform) để sắp xếp lại ký tự theo ngữ cảnh, giúp nén hiệu quả hơn với dữ liệu dạng văn bản. Ngoài ra, một bộ giải nén bzip2 tối giản chỉ cần khoảng 1,5 KB, rất phù hợp cho các ứng dụng nhúng nơi kích thước mã nguồn cũng quan trọng không kém tỉ lệ nén.

**Điểm chính:**
- bzip2 và bzip3 nén dữ liệu văn bản/mã nguồn tốt hơn gzip, zstd, xz, brotli trong thực nghiệm
- Thuật toán BWT sắp xếp lại ký tự theo ngữ cảnh, khác biệt căn bản so với LZ77
- Bộ giải nén bzip2 tối giản chỉ ~1,5 KB, phù hợp cho môi trường nhúng
- bzip cho kết quả xác định và tối ưu, không dựa vào heuristic

## [Tại sao các kiến trúc sư hệ thống mặc định chọn Arm cho trung tâm dữ liệu AI](https://newsroom.arm.com/blog/why-system-architects-default-to-arm-in-ai-data-centers)

Arm đang trở thành lựa chọn mặc định cho hạ tầng AI khi các trung tâm dữ liệu chuyển dịch sang các hệ thống chuyên dụng cấp rack được thiết kế riêng cho workload AI. Kiến trúc Arm mang lại hiệu quả năng lượng vượt trội so với x86 truyền thống, đặc biệt phù hợp với các tác vụ suy luận liên tục và ứng dụng AI tác nhân — những use case đòi hỏi mẫu điện toán liên tục và thích ứng.

Xu hướng này phản ánh sự thay đổi lớn trong ngành: thay vì dùng máy chủ đa năng, các tổ chức ngày càng xây dựng hạ tầng AI chuyên biệt từ cấp rack trở lên. Arm được các kiến trúc sư hệ thống ưa chuộng nhờ khả năng mở rộng quy mô hiệu quả hơn, sử dụng tài nguyên tốt hơn, và ngày càng nhiều bộ xử lý AI dẫn đầu thị trường được xây dựng trên nền Arm — điều này cho thấy sự xác nhận rộng rãi của ngành về khả năng cạnh tranh của kiến trúc này.

**Điểm chính:**
- Trung tâm dữ liệu AI chuyển sang hệ thống chuyên dụng cấp rack, ưu tiên Arm thay cho x86 đa năng
- Arm vượt trội về hiệu quả năng lượng khi mở rộng quy mô cho workload AI
- Phù hợp đặc biệt với suy luận liên tục và ứng dụng AI tác nhân
- Xu hướng cho thấy sự xác nhận toàn ngành về Arm trong hạ tầng AI cao cấp

## [Redis xây dựng Agent Skill để AI viết mã Redis như chuyên gia](https://redis.io/blog/we-built-an-agent-skill-so-ai-writes-redis-code/)

Redis đã tạo ra một **Agent Skill** — tệp markdown mã hóa kiến thức chuyên sâu về Redis — để các tác nhân AI như Claude Code, Cursor, Copilot có thể sinh ra mã Redis theo đúng cách của chuyên gia. Vấn đề cốt lõi là các mô hình ngôn ngữ lớn được huấn luyện trên dữ liệu cũ thường sinh mã theo kiểu Redis 6, bỏ lỡ các tính năng hiện đại như vector sets, hỗ trợ JSON, query engine hay LangCache. Ngoài ra, tác nhân AI còn dễ mắc lỗi kiến trúc như không dùng sliding window cho rate limiter, thiếu bảo vệ chống cache stampede, hay bỏ qua cơ hội dùng pipelining.

Agent Skill cung cấp cho tác nhân AI các mẫu đúng cho các use case phổ biến (caching, rate limiting, session management, vector search...), hướng dẫn chọn cấu trúc dữ liệu phù hợp, và cảnh báo các anti-pattern nguy hiểm như dùng `KEYS *` trong vòng lặp hay để key tăng trưởng không giới hạn. Đây là tệp markdown có thể quản lý bằng git, chia sẻ qua nhóm, và tương thích với nhiều tác nhân AI khác nhau theo một tiêu chuẩn mở.

**Điểm chính:**
- LLM sinh mã Redis theo kiểu cũ (Redis 6), bỏ lỡ các tính năng và mẫu hiện đại
- Agent Skill là tệp markdown mã hóa kiến thức chuyên sâu, được tải theo yêu cầu khi tác nhân gặp tác vụ liên quan
- Cung cấp mẫu đúng cho caching, rate limiting, session management, vector search và nhiều use case khác
- Ngăn các anti-pattern nguy hiểm: `KEYS *` trong vòng lặp, key tăng trưởng không giới hạn, chọn sai cấu trúc dữ liệu
- Có thể quản lý bằng git, chia sẻ qua nhóm, tương thích với nhiều tác nhân AI

## [Bên trong Archive: Công nghệ đằng sau Spotify Wrapped 2025](https://engineering.atspotify.com/2026/3/inside-the-archive-2025-wrapped)

Đội ngũ kỹ thuật Spotify chia sẻ cách họ xây dựng hệ thống AI tạo ra các báo cáo cá nhân hóa cho tính năng Archive trong Wrapped 2025. Thay vì chỉ hiển thị số liệu thống kê, Archive xác định tối đa 5 "ngày đáng nhớ" từ lịch sử nghe nhạc của mỗi người dùng và dùng LLM để tạo ra các câu chuyện sáng tạo dựa trên dữ liệu nghe nhạc thực. Hệ thống đã tạo ra khoảng 1,4 tỷ báo cáo được tạo sẵn cho 350 triệu người dùng đủ điều kiện, đòi hỏi duy trì hàng nghìn yêu cầu mỗi giây trong nhiều ngày trước khi ra mắt.

Về mặt kỹ thuật, họ dùng hệ thống dựa trên heuristic để xác định các khoảnh khắc nghe nhạc đáng chú ý, kết hợp pipeline dữ liệu phân tán với hàng đợi tin nhắn để xử lý bất đồng bộ. Để tối ưu chi phí và chất lượng, họ áp dụng model distillation thu nhỏ các mô hình frontier lớn thành phiên bản sản xuất nhỏ hơn, rồi dùng DPO kết hợp đánh giá của con người. Kiểm soát chất lượng được thực hiện bằng cách đánh giá ~165.000 báo cáo mẫu qua "LLM as a judge" theo các tiêu chí độ chính xác, an toàn, giọng văn và định dạng.

**Điểm chính:**
- Tạo 1,4 tỷ báo cáo cá nhân hóa cho 350 triệu người dùng, duy trì hàng nghìn yêu cầu/giây
- Heuristic xác định các khoảnh khắc đáng nhớ; LLM tạo câu chuyện từ dữ liệu thực
- Model distillation + DPO giúp giảm chi phí nhưng vẫn giữ chất lượng cao
- "LLM as a judge" đánh giá 165.000 báo cáo mẫu theo độ chính xác, an toàn, giọng văn
- Pre-scale hạ tầng và load test theo vùng địa lý để sẵn sàng cho làn sóng truy cập tức thì khi ra mắt

## [Quản lý nhiều tác nhân AI](https://fffej.substack.com/p/managing-multiple-agents)

Jeff khám phá cách các phong cách quản lý khác nhau áp dụng cho việc điều phối nhiều tác nhân AI, thông qua kịch bản lắp ráp tủ sách Ikea với bốn tác nhân chuyên biệt: đọc hướng dẫn, quản lý phụ tùng, lắp ráp và kiểm tra chất lượng. Bốn phong cách quản lý được so sánh: Command and Control (phê duyệt từng hành động), Taylorism (chia nhỏ công việc thành các tác vụ chuẩn hóa), Quản lý theo kết quả, và Tự trị hoàn toàn.

Kết quả thú vị nhất là quản lý theo kết quả — định nghĩa mục tiêu thay vì quy định từng bước — nhanh hơn 5 lần so với Command and Control và 3 lần so với Taylorism. Đáng chú ý, cách này còn tạo ra "mở rộng vai trò tự nhiên": tác nhân quản lý phụ tùng tự nhận ra lắp ráp là nút thắt cổ chai và bắt đầu hỗ trợ dù không được chỉ định. Ngược lại, tự trị hoàn toàn dẫn đến các tác nhân "quẫy đạp", trùng lặp công việc — minh chứng cho nhận xét của Kent Beck: "Tự trị không có ràng buộc là hỗn loạn."

**Điểm chính:**
- Bốn phong cách: Command and Control, Taylorism, quản lý theo kết quả, tự trị hoàn toàn
- Quản lý theo kết quả hiệu quả nhất: nhanh hơn 5x so với Command and Control
- Tự trị hoàn toàn gây ra trùng lặp công việc và hỗn loạn khi thiếu ràng buộc
- Tác nhân AI có khả năng mở rộng vai trò tự nhiên khi được trao quyền tự quyết theo mục tiêu
- Điều phối tác nhân AI phản chiếu quản lý nhóm người: nhóm giỏi cần mục tiêu rõ ràng, không cần vi quản lý
